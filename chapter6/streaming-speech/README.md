# 实验 6-5：Qwen2-Audio 递增前缀模拟流式感知

一句话还没说完时，语音系统可能已经得到部分信息。本实验逐渐扩大音频前缀，观察转写与声学判断怎样随新片段变化，并与等待端点后再识别的路径比较。

[English](#english)

建议按以下顺序阅读：[理解问题与方法](#learning-0) → [准备环境与输入](#learning-1) → [按照步骤完成实验](#learning-2) → [分析结果与形成判断](#learning-3)。

<a id="learning-0"></a>

## 理解问题与方法

这里每次把从开头到当前时刻的音频重新送入模型，属于递增前缀的模拟方式。它能研究何时得到有用信息，但会重复编码，不能直接当作具有持续内部状态的原生流式实现。

本目录对应正文实验 6-5。运行器与已归档证据沿用历史标识 `exp6-4-*`，复核时按原路径读取。

本项目实际运行 `Qwen/Qwen2-Audio-7B-Instruct`：每收到一个新块，就把 `[0:t]` 的完整累积音频再次送入 Qwen2-Audio，输出当前 transcript 和声学事件。它不是 Whisper 替代实现，也不会把这种全量重编码称作真流式。

对照组是传统 600ms 端点 VAD + 开源 Whisper。三类场景均被测量：正常对话、含 900ms 中途停顿的长句、混入粉红背景噪声的对话。证据记录每个前缀的模型原始输出、单块延迟、最终 CER、事件 token，以及 VAD 分段点、Whisper 推理时长和 CER。

<a id="learning-1"></a>

## 准备环境与输入

先核对本地模型、依赖与硬件条件。首次运行可能下载模型；确认模型能够加载后，再观察本实验关心的行为，避免把环境错误与模型表现混在一起。

### 安装

```bash
# From the repository root: use the shared Chapter 6 core environment
uv sync --locked --python 3.12 --extra ch6

# Activate it before changing directories:
# macOS/Linux:
source .venv/bin/activate
# Windows PowerShell: .\.venv\Scripts\Activate.ps1
# Windows cmd: .venv\Scripts\activate.bat

# pip fallback when uv is not installed:
# python -m pip install -e ".[ch9]"

cd chapter6/streaming-speech

# Install this experiment's local audio/model runtime dependencies.
python -m pip install -r requirements.txt
```

NVIDIA 路径使用原始 BF16 权重：

```bash
python demo.py --model Qwen/Qwen2-Audio-7B-Instruct --device cuda ...
```

Apple Silicon 可运行同一 Qwen2-Audio 架构的 4-bit MLX 量化权重（LLM 量化，音频编码器和 projector 保持 BF16）：

```bash
python prepare_scenarios.py audio/sentence.wav validation/scenarios

python demo.py \
  --model mlx-community/Qwen2-Audio-7B-Instruct-4bit --device mlx \
  --chunk-seconds 2 --whisper-model tiny \
  --audio validation/scenarios/normal.wav --scenario normal \
  --reference '麻烦你帮我把明天下午的会议改到两点半，地点还是在三号会议室，别忘了通知大家。' \
  --audio validation/scenarios/long_pause.wav --scenario pause \
  --reference '麻烦你帮我把明天下午的会议改到两点半，地点还是在三号会议室，别忘了通知大家。' \
  --audio validation/scenarios/background_noise.wav --scenario noise \
  --reference '麻烦你帮我把明天下午的会议改到两点半，地点还是在三号会议室，别忘了通知大家。'
```

结果写入 `validation/latest.json`。`--skip-whisper` 只用于单独调试 Qwen，不能完成书中的对照验收。原始 BF16 模型约 16.8GB；MLX 量化权重约 6.6GB。

保持上述科学设计不变并生成完整验收 manifest：

```bash
python run_official_experiment.py --run-id exp6-4-qwen2audio-whisper-provenance-YYYYMMDD-vN
```

官方 runner 在运行前后核对源码 hash，并绑定三类测试音频、原始源音频、Whisper
checkpoint、Qwen2-Audio snapshot 的每个文件（包括 6.56GB 权重）、13 个原始前缀
输出、运行日志和独立 acceptance 文件。

<a id="learning-2"></a>

## 按照步骤完成实验

先听完整样例并阅读参考转写，再按下文准备本地音频模型。选择正常、长停顿或背景噪声中的一种场景，逐个前缀查看输出，记录第一次正确判断出现在什么位置。

<a id="learning-3"></a>

## 分析结果与形成判断

部分转写后来可能被修正；越早输出不一定越准确。比较时同时看文字错误率、单次处理时间和停止判断，尤其检查长停顿是否造成错误分段。

### 已有运行结果

当前 canonical 记录是 [`validation/runs/exp6-4-qwen2audio-whisper-provenance-20260730-v3/manifest.json`](validation/runs/exp6-4-qwen2audio-whisper-provenance-20260730-v3/manifest.json)。
2026-07-30 在 Apple Silicon 上严格复跑 `mlx-community/Qwen2-Audio-7B-Instruct-4bit`；8/8
执行与溯源门禁通过，但正文结果只复现 2/6。13 次前缀推理实测 8.4–11.3s，不能据此声称
100–200ms；传统路径也未在三类输入上全部落入 800–1100ms。900ms 停顿被 VAD 分为两段，
但 Qwen 漏报 `<|silence|>`；强噪声样本检出 `<|noise|>`，同时误报 `<|cough|>` 与
`<|laughter|>`。这些负结果与所有原始响应都保留在验收记录中。2026-07-29 的 `latest.json`
和 `latest_v2.json` 作为历史运行保留，不再承担 canonical 选择职责。

```bash
pytest -q
```

---

### 检查自己的解释

如果前缀越长处理越慢，怎样区分模型本身的实时能力与反复重编码带来的开销？

## English

This is actual Qwen2-Audio growing-prefix inference, not a Whisper substitute. Every `[0:t]` prefix is fully re-encoded and compared with a real 600ms-VAD + open-source Whisper pipeline on normal, long-pause, and noisy speech. CUDA uses the original model; Apple Silicon can use the published 4-bit MLX conversion of the same Qwen2-Audio architecture. The canonical v3 manifest binds raw responses, sources, audio, the Whisper checkpoint, and every Qwen snapshot file. Execution passed while the manuscript result bundle did not: only 2/6 claims reproduced, with 8.4–11.3s prefix inference and retained acoustic-event errors.

### 归档材料复核（2026-10-07）

本次只读复核中，manifest 列出的三个场景音频及三个运行产物哈希一致；原始输入 `audio/sentence.wav` 在当前工作树中缺失。模型缓存与运行源码另有各自的版本记录，场景音频是本次回看前缀输入的依据。历史 manifest 保持原样。
