---
name: soprano-80m-npu-deploy
description: >
  Soprano-80M 超轻量TTS模型在华为昇腾 NPU 上的完整部署与推理验证 Skill。
  涵盖环境准备、依赖安装、模型下载、NPU 推理验证、精度对比验证的全流程。
  基于 Qwen3ForCausalLM 架构 + ConvNeXt 音频解码器，80M 参数，显存 < 1GB。
  当用户提到 Soprano NPU 部署、Soprano TTS 昇腾推理、文本转语音 NPU 适配时触发。
metadata:
  short-description: Soprano-80M 昇腾 NPU 部署与 bf16 推理验证
  category: NPU-Model-Deploy
  tags: [ascend, npu, soprano, tts, text-to-speech, qwen3, pytorch, inference, transformers, audio]
---

# Soprano-80M 昇腾 NPU 部署与 bf16 推理验证 Skill

本 Skill 提供 Soprano-80M 超轻量文本转语音（TTS）模型在华为昇腾 NPU 上的
完整部署、推理验证和精度对比的标准化可复现流程。

Soprano-80M 由 ekwek 开源，80M 参数，基于 Qwen3ForCausalLM 生成音频 token，
再通过 ConvNeXt 解码器 + ISTFT 输出 32kHz 高保真音频。

## 前置条件

| 项目 | 要求 |
|------|------|
| 硬件 | Ascend910 系列（80M 模型，极低显存，>= 2GB 即可） |
| OS | openEuler / Ubuntu / KylinOS（aarch64 或 x86_64） |
| CANN | >= 8.0（推荐 8.5.1 及以上） |
| Python | 3.9 – 3.13 |
| 网络 | 首次运行需联网下载模型权重 |

## 流程总览

```
0. 环境初始化与 NPU 预检
→ 1. 安装依赖（torch_npu + transformers + soundfile）
→ 2. 下载模型（hf-mirror.com）
→ 3. NPU 基础验证
→ 4. 推理验证（scripts/inference.py）
→ 5. 精度对比验证（scripts/verify_accuracy.py：NPU vs CPU）
→ 6. 验收确认
```

按以下各节顺序执行，每步完成后再进入下一步。

---

## 0. 环境初始化与 NPU 预检

0. 加载 CANN 环境
1. 检查 NPU 状态
2. 选择空闲 NPU 卡
3. 设置国内镜像

### 0.1 加载 CANN 环境

```bash
source /usr/local/Ascend/ascend-toolkit/set_env.sh
```

**如果加载失败**，请检查 `/usr/local/Ascend/ascend-toolkit/` 是否存在；若不存在，按官方文档重新安装 CANN，执行回滚重试。

### 0.2 NPU 状态检查

```bash
npu-smi info
```

**用户确认**：确保 `npu-smi info` 输出显示至少 1 张卡状态为 `OK`，且显存占用 < 80%。

### 0.3 选择空闲 NPU

```bash
export ASCEND_RT_VISIBLE_DEVICES=0
```

### 0.4 设置国内镜像

```bash
export HF_ENDPOINT=https://hf-mirror.com
```

---

## 1. 安装依赖

0. 安装 torch 和 torch_npu
1. 安装其他依赖
2. 验证安装

```bash
pip install torch==2.9.0+cpu --index-url https://download.pytorch.org/whl/cpu
pip install torch-npu transformers soundfile
```

安装完成后 `torch` 与 `torch_npu` 版本应一致（如均为 2.9.0）。

### 1.1 验证安装

```bash
python3 -c "import torch_npu; import transformers; import soundfile; print('All dependencies OK')"
```

**如果报错 `No module named 'torch_npu'`**，请回滚到步骤 0.1 重新加载环境后执行 `pip install torch_npu`。

### 1.2 验证 NPU 设备

```bash
python3 -c "
import torch
import torch_npu
print('NPU available:', torch.npu.is_available())
print('NPU count:', torch.npu.device_count())
"
```

**通过标准**：NPU available 为 True。

---

## 2. 下载模型

0. 设置镜像源
1. 下载模型文件
2. 验证下载完整性

```bash
export HF_ENDPOINT=https://hf-mirror.com
hf download ekwek/Soprano-80M --local-dir /opt/atomgit/model_cache/Soprano-80M
```

模型文件（约 211MB）：

| 文件 | 大小 | 说明 |
|------|------|------|
| `model.safetensors` | 153MB | Qwen3ForCausalLM 权重 |
| `decoder.pth` | 56MB | ConvNeXt 音频解码器 + ISTFT |
| `tokenizer.json` | 1.6MB | Tokenizer 词表 |
| `config.json` | 1.1KB | 模型配置 |

**输入/输出定义**：
- 输入：网络连接、`HF_ENDPOINT` 环境变量
- 输出：`/opt/atomgit/model_cache/Soprano-80M/` 下的模型文件
- 异常：如果下载中断，请重新运行 `hf download`；如果 `hf` 命令不存在，请执行 `pip install huggingface_hub`。

---

## 3. NPU 基础验证

0. 导入 torch_npu
1. 检查 NPU 可用性
2. 检查 NPU 设备名

```bash
python3 -c "
import torch
import torch_npu
print('torch:', torch.__version__)
print('NPU available:', torch.npu.is_available())
print('NPU device:', torch.npu.get_device_name(0))
"
```

**通过标准**：`torch.npu.is_available()` 返回 `True` 且无报错。

**输入/输出定义**：
- 输入：已安装 torch_npu 的 Python 环境
- 输出：NPU 设备信息和可用性状态
- 异常：如果 `torch.npu.is_available()` 返回 `False`，请检查 CANN 驱动和固件版本。

---

## 4. 推理验证

0. 准备推理脚本
1. 执行 NPU 推理
2. 验证输出结果

### 4.1 推理脚本

脚本文件位于 `scripts/inference.py`（与 SKILL.md 同目录），核心逻辑：

```python
import torch
import torch_npu
from transformers import AutoModelForCausalLM, AutoTokenizer

# 加载模型
model = AutoModelForCausalLM.from_pretrained(model_path, dtype=torch.bfloat16)
model.to("npu")
model.set_attn_implementation("sdpa")  # NPU 兼容
model.eval()

# 加载音频解码器
decoder = SopranoAudioDecoder(f"{model_path}/decoder.pth")
decoder.to("npu", dtype=torch.bfloat16)
decoder.eval()

# 输入格式：[TEXT] <text> [START]
tokenizer = AutoTokenizer.from_pretrained(model_path)
input_ids = tokenizer.convert_tokens_to_ids("[TEXT]")
+ tokenizer.encode(text, add_special_tokens=False)
+ [tokenizer.convert_tokens_to_ids("[START]")]

# 自回归生成音频 token
# → 收集 hidden_states → decoder → waveform
```

### 4.2 运行推理

```bash
source /usr/local/Ascend/ascend-toolkit/set_env.sh
export ASCEND_RT_VISIBLE_DEVICES=0

python3 scripts/inference.py \
  --model-path /opt/atomgit/model_cache/Soprano-80M \
  --text "你好世界，这是昇腾NPU语音合成测试。" \
  --output output.wav \
  --device npu \
  --dtype bfloat16 \
  --seed 42
```

### 4.3 预期结果

| 指标 | 参考值 |
|------|--------|
| 模型加载 | ~3s (LLM) + ~0.3s (Decoder) |
| 单步前向 | ~0.6s |
| 128 token 生成 | ~23s |
| 显存占用 | < 1GB |
| 输出音频采样率 | 32000 Hz |

**通过标准**：生成有效的 WAV 文件，无 NPU 相关报错。

**输入/输出定义**：
- 输入：模型路径、文本字符串、设备类型、数据类型、随机种子
- 输出：`output.wav`（32kHz PCM）
- 异常：如果输出为静音，请检查 `[TEXT]...[START]` 格式是否正确。

---

## 5. 精度对比验证

0. 理解验证方法
1. 运行精度验证
2. 检查精度结果

### 5.1 验证方法

使用相同输入文本和随机种子（seed=42），分别在 NPU（bfloat16）和 CPU（bfloat16）上执行**单步前向传播**，对比输出 logits。

验证脚本 `scripts/verify_accuracy.py` 使用贪婪解码（非采样）确保确定性对比。

### 5.2 运行验证

```bash
python3 scripts/verify_accuracy.py \
  --model-path /opt/atomgit/model_cache/Soprano-80M \
  --text "你好" \
  --seed 42 \
  --threshold 0.01
```

### 5.3 精度结果参考

| 指标 | 实测值 | 阈值 |
| --- | --- | --- |
| Logit MSE | 0.00001396 | - |
| Logit 余弦相似度 | 0.99999343 | > 0.99 |
| **Logit 相对误差** | **0.4002%** | **< 1%** |
| 结果 | **PASSED** | - |

**通过标准**：前向传播 logits 相对误差 < 1%。

> 注：自回归生成时 bf16 在不同硬件上的算子差异可能导致个别 token argmax 不同（Token 匹配率约 68.8%），这不影响模型在 NPU 上的计算正确性。前向传播 logits 精度 0.4002% 证明了 NPU 推理是正确的。

---

## 6. 异常边界与 Fallback 策略

| 异常场景 | 触发条件 | Fallback 策略 | 恢复操作 |
|---|---|---|---|
| `No module named 'torch_npu'` | CANN 未加载或 torch_npu 未安装 | 暂停执行，回滚到步骤 0.1 | `source set_env.sh` 后重装 torch_npu |
| `No module named 'soundfile'` | 缺少依赖 | 暂停，安装依赖 | `pip install soundfile` |
| ISTFT 报错 `EZ9999` | NPU 不支持 n_fft=2048 的 ISTFT | 自动 fallback 到 CPU | 脚本已自动切换到 CPU 执行 ISTFT |
| `torch.complex` bf16 报错 | NPU 不支持 bf16 复数 | 自动转 float32 | 脚本已自动处理 |
| 模型下载失败 | 网络问题 | 重试，切换镜像 | 确认 `HF_ENDPOINT=https://hf-mirror.com` |
| 输出音频过短/无声音 | 文本太短或 token 配置问题 | 失败，需用户确认 | 确认 `[TEXT]...[START]` 格式正确 |
| torch_npu 权限警告 | 文件属主不匹配 | 可忽略 | 不影响推理 |
| OOM | 并发推理 | 回滚，单条推理 | 降低 batch size 或输入长度 |

---

## 7. 检查点与验收确认

完成以下检查清单即为部署成功。每步完成后请**用户确认**再继续下一步：

| # | 检查项 | 验证方法 | 通过标准 | 操作说明 |
|---|--------|---------|---------|---------|
| 1 | NPU 设备状态 | `npu-smi info` | 至少 1 张卡状态 OK，显存占用 < 80% | 用户确认设备正常 |
| 2 | NPU 环境就绪 | `python3 -c "import torch_npu"` | 无报错 | 用户确认无 ImportError |
| 3 | 推理验证 | `python3 scripts/inference.py` | 成功生成 WAV 音频文件 | 用户确认推理结果 |
| 4 | 精度验证 | `python3 scripts/verify_accuracy.py` | 报告 PASSED | 用户确认评测报告 |
| 5 | 精度阈值 | 前向传播 logits 相对误差 | < 1% | 用户确认精度达标 |

---

## 8. 资源速查表

| 资源类型 | 路径 / 说明 |
|----------|-------------|
| 推理脚本 | `scripts/inference.py` |
| 精度验证脚本 | `scripts/verify_accuracy.py` |
| 模型缓存 | `/opt/atomgit/model_cache/Soprano-80M/` |
| 参考文档 | https://www.hiascend.com/document/ |
| HuggingFace 镜像 | https://hf-mirror.com |

---

## 附录：Soprano-80M NPU 适配要点速查

| 特征 | Soprano 值 | 对 NPU 适配的影响 |
|------|-----------|------------------|
| 架构 | Qwen3ForCausalLM | 原生支持，attention 设为 sdpa |
| 参数量 | 80M | 极轻量，显存 < 1GB，单卡即可 |
| 精度 | bf16 | NPU 原生支持 |
| 音频解码器 | ConvNeXt + ISTFT | ConvNeXt 在 NPU 上运行，ISTFT 需 CPU 执行 |
| 输入格式 | [TEXT] + text + [START] | 自定义 token 拼接 |
| 自回归 | token-by-token | KV Cache 在 NPU 上有效加速 |
| 特殊 Token | [UNK]=0, [TEXT]=1, [START]=2, [STOP]=3 | 标准 tokenizer 格式 |
