<!--
SPDX-License-Identifier: MIT
Copyright (c) 2026 Hygon Information Technology Co., Ltd.
-->

# fuse_rms_mrope 算子说明与性能报告

本接口把可选残差相加、RMSNorm 与 M-RoPE（多模态旋转位置编码）融合为一次 kernel，对同一批 token 的 Query 与 Key 原地完成预处理，用于多模态模型 prefill / decode 的输入编码阶段，例如分段式 `[t,h,w]=(16,24,24)`（Qwen2.5-VL 风格）或交错式 M-RoPE。**`q` 与 `k` 被原地改写，接口无返回值，也不分配输出。**文末性能报告为 BW1100（gfx938）单实现的绝对耗时测量，采样日期 2026-09-23；按需求省略 original 对照，全文不含加速比，完整数据与适用范围见性能报告章节。

## 算子功能

对每个 token 的每个 head 依次执行：可选残差相加 → RMSNorm → M-RoPE 旋转，结果写回原位。记号如下：

| 符号 | 含义 |
|---|---|
| `T` | token 数，即 `q` / `k` 的第 0 维 |
| `n_qh` / `n_kh` | Query / Key 的 head 数，由列宽除以 `head_size` 隐式给出，两者相互独立 |
| `head_size` | 每 head 维度，仅支持 64 / 128 |
| `half_rd` | `head_size/2`，旋转频率索引宽度，即 `cos` / `sin` 最后一维 |
| `mrope_section` | `[t,h,w]`：temporal / height / width 三段宽度，非负且和为 `half_rd` |

```text
x = q[tok, head, :] ∈ R^head_size            # k 同理，独立使用 weight_k
x = x + residual[tok, head, :]               # 仅当提供 residual；residual 不被更新
x = x * rsqrt(mean(x^2) + epsilon) * weight  # RMSNorm，逐 head
c_p, s_p = 按 p 所处分段从 cos/sin 的 t/h/w 平面选取（见下表）
y[p]         = x[p] * c_p - x[p+half_rd] * s_p        # p ∈ [0, half_rd)
y[p+half_rd] = x[p+half_rd] * c_p + x[p] * s_p
输出：原地写回 q/k，形状与 dtype 不变；无填充位
```

`cos` / `sin` 形状为 `[3,T,half_rd]`，三个平面按 t / h / w 顺序排列。位置 `p` 使用哪个平面由 `is_interleaved` 决定：

| `is_interleaved` | 位置 p 使用的 cos/sin 平面 |
|---|---|
| `False`（分段式） | `p∈[0,t)` 用平面 0（temporal）；`p∈[t,t+h)` 用平面 1（height）；`p∈[t+h,half_rd)` 用平面 2（width） |
| `True`（交错式） | `p%3==1` 且 `p<=3h` 用平面 1；`p%3==2` 且 `p<=3w` 用平面 2；其余用平面 0。**t 不参与选取** |

**`is_interleaved` 只改变 cos/sin 平面的选取方式；旋转配对固定为前后半交换（`p` 与 `p+half_rd`），不随该开关改变。**接口原地改写 `q` 和 `k`，需要保留原始值时应先 `clone()`。residual 为只读输入，**`x+residual` 的和不会写回 residual**（与部分框架把和写回 residual 的 fused_add_rms_norm 行为不同）。

`mrope_section` 的某一段允许为 0，此时对应平面不被任何位置选用。`n_qh` 与 `n_kh` 不要求整除关系，也允许 `n_kh > n_qh`；头数组合只影响 kernel 分发选择，不影响功能。

本接口不计算 attention 分数或 softmax，不写 KV cache，也不支持 `rotary_dim < head_size` 的部分旋转（整个 head 参与旋转）。cos/sin 不做幅值或单位性校验，weight 不做有限性校验，均由调用方保证。接口用于推理，不提供反向计算。

## 接口与参数

```python
from aiter.ops.fuse_rms_mrope import fuse_rms_mrope

fuse_rms_mrope(
    q, k, cos, sin, mrope_section, head_size, is_interleaved,
    weight_q, weight_k,
    residual_q=None, residual_k=None, epsilon=1e-6,
)
```

| 参数 | 类型 / 形状 | 含义与约束 |
|---|---|---|
| `q` | Tensor `[T, n_qh*head_size]` | 待归一化与旋转的 Query；连续存储；调用后被原地改写 |
| `k` | Tensor `[T, n_kh*head_size]` | 待归一化与旋转的 Key；与 `q` 同 dtype；调用后被原地改写 |
| `cos` / `sin` | Tensor `[3,T,half_rd]` | 三个平面按 t/h/w 顺序；与 `q` 同 dtype，连续存储 |
| `mrope_section` | Python `list[int]`，3 项 `[t,h,w]` | 非负且 `t+h+w == head_size/2` |
| `head_size` | Python `int` | 仅支持 64 或 128 |
| `is_interleaved` | Python `bool` | `True` 为交错式平面选取 |
| `weight_q` / `weight_k` | Tensor `[head_size]` | RMSNorm 缩放系数；连续存储，与 `q` 同 dtype |
| `residual_q` / `residual_k` | 可选 Tensor，默认 `None` | 须成对提供或成对省略；形状、dtype 与 `q`/`k` 一致；只读不回写；**连续性由调用方保证** |
| `epsilon` | Python `float`，默认 `1e-6` | 须大于 0 |
| 返回值 | `None` | 无输出分配，结果在 `q`/`k` 原位 |

`q`、`k` 支持 FP16 / BF16 / FP32 / FP64，且 `q`/`k`/`cos`/`sin`/`weight_q`/`weight_k` 必须同 dtype；仓库测试矩阵覆盖 FP16 / BF16。所有张量须在同一 GPU。

接口在 native 入口检查 `head_size` 取值、`epsilon > 0`、`q`/`k` 为二维且 token 数一致、列宽为正且整除 `head_size`、`mrope_section` 长度与取值、`cos`/`sin` 与 weight 的形状、六个主输入的 dtype 一致性与连续性、residual 的成对性 / 形状 / dtype / 设备。全部为元数据检查，无 GPU→CPU 数值同步。**residual 的连续性、`k`/`cos`/`sin`/`weight` 与 `q` 的设备一致性未显式检查**，cos/sin/weight 的数值内容亦不检查，由调用方保证。

公开接口经 `@compile_ops("module_fuse_rms_mrope")` JIT 编译，首次调用触发编译并缓存，之后直接进入 native 入口。

## 使用方式

### 基本调用与参考比对

```python
import torch
from aiter.ops.fuse_rms_mrope import fuse_rms_mrope

device = "cuda:0"  # HCU/ROCm 也使用 PyTorch 的 cuda 设备名
T, n_qh, n_kh, head_size = 8, 4, 1
half_rd = head_size // 2
mrope_section = [16, 24, 24]  # t/h/w，和必须等于 half_rd

q = torch.randn(T, n_qh * head_size, device=device, dtype=torch.bfloat16)
k = torch.randn(T, n_kh * head_size, device=device, dtype=torch.bfloat16)
cos = torch.randn(3, T, half_rd, device=device, dtype=torch.bfloat16)
sin = torch.randn(3, T, half_rd, device=device, dtype=torch.bfloat16)
weight_q = torch.randn(head_size, device=device, dtype=torch.bfloat16)
weight_k = torch.randn(head_size, device=device, dtype=torch.bfloat16)
residual_q = torch.randn_like(q)
residual_k = torch.randn_like(k)

q_in, k_in = q.clone(), k.clone()
with torch.inference_mode():
    fuse_rms_mrope(q_in, k_in, cos, sin, mrope_section, head_size,
                   False, weight_q, weight_k, residual_q, residual_k)
assert not torch.equal(q_in, q)  # 原地生效，无返回值
```

可用如下 PyTorch 参考实现核对结果（与仓库测试同源）：

```python
def ref_rms_mrope(x2d, weight, cos, sin, mrope_section, is_interleaved,
                  residual=None, eps=1e-6):
    T, cols = x2d.shape
    hsz = weight.numel()
    x = x2d.view(T, cols // hsz, hsz).float()
    if residual is not None:
        x = x + residual.view(T, cols // hsz, hsz).float()
    x = x * torch.rsqrt(x.pow(2).mean(-1, keepdim=True) + eps) * weight.float()
    half_rd = cos.shape[-1]
    t, h, w = mrope_section
    pos = torch.arange(half_rd, device=x2d.device)
    if is_interleaved:
        is_h = ((pos % 3) == 1) & (pos <= 3 * h)
        is_w = ((pos % 3) == 2) & (pos <= 3 * w)
    else:
        is_h = (pos >= t) & (pos < t + h)
        is_w = (pos >= t + h) & (pos < half_rd)
    c = torch.where(is_h, cos[1], torch.where(is_w, cos[2], cos[0])).float()[:, None, :]
    s = torch.where(is_h, sin[1], torch.where(is_w, sin[2], sin[0])).float()[:, None, :]
    x0, x1 = x[..., :half_rd], x[..., half_rd:]
    out = torch.cat([x0 * c - x1 * s, x1 * c + x0 * s], dim=-1)
    return out.view_as(x2d).to(x2d.dtype)

ref_q = ref_rms_mrope(q, weight_q, cos, sin, mrope_section, False, residual_q)
# 与仓库测试一致的验收：不匹配元素比例 <= 5%
ok = torch.isclose(q_in.float(), ref_q.float(), rtol=5e-2, atol=5e-2)
assert ok.float().mean() >= 0.95  # k 用 weight_k 同理核对
```

示例中的随机 `cos`/`sin` 与 `weight` 仅为演示；真实模型传入按位置编码预计算好的 cos/sin 与模型权重。示例的参考实现与断言仅用于正确性展示，不应纳入热路径计时。改用交错式时把 `is_interleaved` 传 `True` 即可，参数含义不变；换 `head_size=64` 时 `mrope_section` 之和须为 32，`cos`/`sin` 末维同步改为 32。

### Graph 捕获

```python
# 接续上面的示例，输入张量保持存活。
def run():
    fuse_rms_mrope(q_in, k_in, cos, sin, mrope_section, head_size,
                   False, weight_q, weight_k, residual_q, residual_k)

run()  # 首次 JIT 必须在捕获之外完成
warm_stream = torch.cuda.Stream()
warm_stream.wait_stream(torch.cuda.current_stream())
with torch.cuda.stream(warm_stream):
    for _ in range(3):
        run()
torch.cuda.current_stream().wait_stream(warm_stream)
graph = torch.cuda.CUDAGraph()
with torch.cuda.graph(graph):
    run()
graph.replay()
torch.cuda.synchronize()
assert q_in.shape == (T, n_qh * head_size)
```

本算子原地读写 `q`/`k`，捕获的输入地址即输出地址：更新输入须在相同张量上 `copy_`，并保持全部输入存活。**本算子不是幂等操作，连续 replay 会对已旋转的结果再次叠加 RMSNorm 与旋转；每次推理前必须先把新的原始 q/k 写入固定地址张量，再 replay。**输出消费需遵守 stream 依赖。首次 JIT 与预热应在捕获和计时之外完成。

### 功能验证入口

```bash
HIP_VISIBLE_DEVICES=0 python op_tests/test_fuse_rms_mrope.py \
    --num_tokens 128 --head_size 128 --dtype bf16 --residual
```

脚本固定运行 8 个用例：`n_qh/n_kh ∈ {(8,8),(8,4),(6,1),(4,1)}` × 两种 `is_interleaved`，均与 PyTorch 参考实现逐元素比对（`rtol=atol=5e-2`，不匹配比例 ≤5%），并可加 `--residual` 覆盖残差路径。脚本自带 warmup 3 次 / 迭代 10 次的 `perf_counter` 墙钟对比与 speedup 表；该口径包含 Python 分发开销，是 CPU 墙钟时间，与后续性能报告的 GPU 计时口径不同，不能混用。

## 实现与架构范围

每个 token 启动一个 block。block 先把该 token 的 cos/sin 三个平面按分段规则（分段式区间或交错式取模）抽取拼接为 `half_rd` 长度的共享内存表，再逐 head 处理：RMSNorm 由单个 warp 独立完成（warp shuffle 归约并广播 rstd，无 block 级归约，一个 warp 负责一个 head），旋转用 `p ^ half_rd` 的 XOR 索引完成前后半配对（`half_rd ∈ {32,64}` 为 2 的幂）。累积与旋转计算使用 `acc_type`（FP16/BF16 输入按 FP32 累积计算），结果写回原 dtype 与原地址。

按 shape 在三个 kernel 变体间分发：`n_kh==1` 且 `n_qh` 为 2 或 3 的倍数时走 pipeline 变体（warp0 处理 K，其余 warp 处理 Q，Q/K 重叠执行）；`num_tokens<=256` 走 small 变体（先 Q 后 K 顺序处理）；其余走 optimized 变体（Q/K 同循环交错处理）。warp 数（1–4）按 `n_kh` / `n_qh` 的整除性选择，向量化宽度在 `head_size=128` 时为 2、64 时为 1；`n_qh % n_kh == 0` 只是选择宽分发的条件，不满足时走 1-warp 兜底分支，功能与正确性不受影响。未做架构特化分支，公共接口无 kernelId 参数；`csrc/kernels/fuse_rms_mrope.cu` 与 `aiter_meta/csrc/kernels/fuse_rms_mrope.cu` 为相同内容的两份副本。

## 性能报告（BW1100 / gfx938）

本节为 AITER 单实现的绝对耗时与有效带宽测量，依据 `op_tests/test_fuse_rms_mrope.py` 的输入构造、参考实现与验收规则扩展而成。**按需求省略 original 对照：全文不设加速比列，PyTorch 参考实现仅用于计时前的正确性验收，不参与计时。**数据采样日期 2026-09-23。本文对应 AITER 源码：接口与 kernel 实现的最近变更为提交 `4189bb2c`（2026-07-30），仓库当前提交 `08b66ee4`（2026-09-21）。

### 环境与计时口径

| 项目 | gfx938 |
|---|---|
| 设备 / 产品型号 | BW1100 |
| 计算单元（CU）数 | 64 |
| 测试卡 / 测试日期 | GPU0 / 2026-09-23 |
| 可见显存 | 147440 MiB |
| 软件 | PyTorch 2.10.0，HIP 6.3.26113（DTK 26.04） |
| 编译 | AICC（`aicc`，DTK 环境的 hipcc），JIT 默认选项 |
| 输入 | BF16 / FP16，全部 `randn` 随机张量 |
| 固定参数 | `epsilon=1e-6`；`mrope_section` 固定为 head_size=128 → `[32,16,16]`、64 → `[16,8,8]` |
| 调用方式 | 公开 Python 接口 `fuse_rms_mrope`，默认 kernel 分发，无 kernelId |
| 计时 | `aiter.test_common.run_perftest`（torch.profiler 设备 kernel 时间） |

- 计时对象为**公开 Python 接口**（含 JIT 包装层分发）。`run_perftest` 预热 10 次后以 torch.profiler 记录 50 次调用，取全部 GPU kernel 设备时间总和除以调用次数，得单次平均设备 kernel 时间；**该数字不是 CPU 墙钟耗时**。「功能验证入口」脚本自带的 `perf_counter` speedup 表属 CPU 墙钟口径，与本文数字不能混用。
- 每组配置独立采样 3 轮（每轮均为完整预热 + 50 次调用），表中耗时取 3 轮中位数；轮间离散度以 CV = 3 轮标准差 / 均值给出，全部 128 组配置的最大 CV 为 4.06%（BF16、head_size=128、T=512、(6,1)、交错式）。
- 计时输入缓冲由 `run_perftest` 的 rotate 机制在最多 50 套副本间轮换，每次计时迭代使用不同副本。本算子除原地写回 `q`/`k` 外无其它破坏性输入，原地写回对计时无影响（RMSNorm 每次迭代先归一化，数值不会发散），无需额外 pristine 缓冲池。
- JIT 编译、输入生成、参考计算与正确性比对均在计时之外；没有在 API 外预先替 AITER 完成其内部必要的数据转换。
- 本算子无外部对照实现，快/平/慢的 ±2% 规则仅用于「配置间开销比」的解读：比值与 1 的偏差在 ±2% 内视为基本持平。

### Shape 与输入构造

配置矩阵共 128 组，分三个子矩阵：

| 子矩阵 | 覆盖 | 配置数 |
|---|---|---:|
| BF16 主力矩阵（head_size=128） | `T ∈ {32, 128, 512, 2048, 8192}` × 头配置 × 交错式 × 残差 | 80 |
| FP16 矩阵（head_size=128） | `T ∈ {128, 2048}` × 头配置 × 交错式 × 残差 | 32 |
| BF16 短头矩阵（head_size=64） | `T ∈ {128, 2048}` × `(8,8)` / `(4,1)` × 交错式 × 残差 | 16 |

头配置 `(n_qh, n_kh) ∈ {(8,8), (8,4), (6,1), (4,1)}`，其中 `(6,1)` / `(4,1)` 为 GQA 形态（KV head 少于 Q head）；「残差」指同时提供 `residual_q` / `residual_k`。shape 矩阵为合成的算子级负载，不是线上请求回放。`q` / `k` / `cos` / `sin` / `weight` / `residual` 全部为 `randn` 随机值（`cos` / `sin` 不做单位性约束，与测试脚本一致）。

有效带宽的动态字节数按读入 + 写出估计（忽略 weight，取上界）：

```text
bytes = T * head_size * esz * ( 2 * (n_qh + n_kh)        # q/k 读入并写回
                              + (n_qh + n_kh) 若有残差    # residual 只读
                              + 3 )                       # cos/sin 三个平面读入
esz = 2（BF16 / FP16）
```

### 正确性与计时边界

每组配置先与 FP32 PyTorch 参考实现（与测试脚本同源）逐元素比对，通过后才进入计时；计时结果不做任何挑选，3 轮全部保留。

| 检查项 | 验收结果 |
|---|---|
| 128 组配置（BF16/FP16 × head_size 128/64 × 交错式 × 残差） | 全部通过 |
| 最大不匹配元素比例 | 1.91e-6（验收阈值 5%，`rtol = atol = 5e-2`） |

### 性能指标定义

```text
单项耗时（µs）  = 3 轮独立采样的中位数（每轮 = 预热 10 次 + 50 次调用的设备 kernel 时间均值）
轮间 CV         = 3 轮标准差 / 3 轮均值 × 100%
有效带宽 (GB/s) = 动态字节数 / 单项耗时 / 1000
配置间耗时比    = 该配置中位耗时 / 同 shape 基线中位耗时（基线 = 分段式、无残差）
```

- 本文没有对照实现，**不含加速比指标**；「配置间耗时比」是同一实现不同调用形态的对比，不能解释为对其它实现的加速。
- 数值列右对齐，耗时三位小数；汇总与比值用未舍入值计算。

### bf16 逐 shape 结果（head_size=128）

所有表格均为 `head_size=128`、`epsilon=1e-6`、`mrope_section=[32,16,16]`；耗时列为 3 轮中位数，「最大 CV」为该行 4 个配置中的最大轮间 CV，「基线带宽」按分段式、无残差配置计算。

#### T=32

| 头配置 (n_qh, n_kh) | 分段式 (µs) | 交错式 (µs) | 残差+分段 (µs) | 残差+交错 (µs) | 基线带宽 (GB/s) | 最大 CV |
|---|---:|---:|---:|---:|---:|---:|
| (8, 8) | 8.990 | 8.916 | 9.406 | 9.385 | 32.0 | 0.21% |
| (8, 4) | 7.754 | 7.679 | 8.072 | 8.042 | 28.6 | 0.25% |
| (6, 1) | 7.080 | 7.156 | 7.206 | 7.299 | 19.7 | 0.27% |
| (4, 1) | 7.153 | 7.262 | 7.303 | 7.429 | 15.0 | 0.30% |

#### T=128

| 头配置 (n_qh, n_kh) | 分段式 (µs) | 交错式 (µs) | 残差+分段 (µs) | 残差+交错 (µs) | 基线带宽 (GB/s) | 最大 CV |
|---|---:|---:|---:|---:|---:|---:|
| (8, 8) | 9.527 | 9.363 | 10.236 | 10.315 | 120.4 | 1.81% |
| (8, 4) | 8.162 | 8.079 | 8.639 | 8.639 | 108.5 | 1.34% |
| (6, 1) | 7.407 | 7.526 | 7.609 | 7.682 | 75.3 | 0.50% |
| (4, 1) | 7.455 | 7.592 | 7.643 | 7.747 | 57.2 | 0.39% |

#### T=512

| 头配置 (n_qh, n_kh) | 分段式 (µs) | 交错式 (µs) | 残差+分段 (µs) | 残差+交错 (µs) | 基线带宽 (GB/s) | 最大 CV |
|---|---:|---:|---:|---:|---:|---:|
| (8, 8) | 14.543 | 14.508 | 15.656 | 15.659 | 315.5 | 1.24% |
| (8, 4) | 13.462 | 13.397 | 14.766 | 14.822 | 262.9 | 1.98% |
| (6, 1) | 10.879 | 10.892 | 11.878 | 11.829 | 204.9 | 4.06% |
| (4, 1) | 9.798 | 9.698 | 10.520 | 10.362 | 174.0 | 3.15% |

#### T=2048

| 头配置 (n_qh, n_kh) | 分段式 (µs) | 交错式 (µs) | 残差+分段 (µs) | 残差+交错 (µs) | 基线带宽 (GB/s) | 最大 CV |
|---|---:|---:|---:|---:|---:|---:|
| (8, 8) | 42.439 | 42.801 | 45.398 | 45.836 | 432.4 | 0.89% |
| (8, 4) | 38.768 | 39.117 | 42.746 | 43.242 | 365.2 | 0.99% |
| (6, 1) | 30.242 | 30.732 | 32.858 | 33.415 | 294.7 | 1.87% |
| (4, 1) | 24.646 | 25.560 | 27.104 | 27.640 | 276.6 | 3.15% |

#### T=8192

| 头配置 (n_qh, n_kh) | 分段式 (µs) | 交错式 (µs) | 残差+分段 (µs) | 残差+交错 (µs) | 基线带宽 (GB/s) | 最大 CV |
|---|---:|---:|---:|---:|---:|---:|
| (8, 8) | 148.756 | 150.770 | 161.436 | 163.373 | 493.4 | 0.19% |
| (8, 4) | 136.512 | 138.592 | 151.898 | 154.058 | 414.8 | 0.17% |
| (6, 1) | 102.161 | 104.479 | 114.159 | 116.935 | 349.0 | 0.86% |
| (4, 1) | 80.208 | 82.423 | 88.218 | 90.327 | 339.9 | 0.84% |

### fp16 与 head_size=64 逐 shape 结果

#### FP16，head_size=128，T=128

| 头配置 (n_qh, n_kh) | 分段式 (µs) | 交错式 (µs) | 残差+分段 (µs) | 残差+交错 (µs) | 基线带宽 (GB/s) | 最大 CV |
|---|---:|---:|---:|---:|---:|---:|
| (8, 8) | 9.077 | 8.962 | 9.533 | 9.521 | 126.4 | 1.84% |
| (8, 4) | 7.754 | 7.738 | 8.200 | 8.100 | 114.2 | 1.41% |
| (6, 1) | 7.183 | 7.276 | 7.261 | 7.322 | 77.6 | 0.50% |
| (4, 1) | 7.284 | 7.421 | 7.333 | 7.417 | 58.6 | 0.50% |

#### FP16，head_size=128，T=2048

| 头配置 (n_qh, n_kh) | 分段式 (µs) | 交错式 (µs) | 残差+分段 (µs) | 残差+交错 (µs) | 基线带宽 (GB/s) | 最大 CV |
|---|---:|---:|---:|---:|---:|---:|
| (8, 8) | 38.106 | 38.305 | 37.842 | 38.161 | 481.6 | 1.24% |
| (8, 4) | 34.829 | 35.082 | 35.606 | 36.136 | 406.5 | 1.22% |
| (6, 1) | 27.245 | 27.859 | 28.211 | 28.956 | 327.2 | 2.04% |
| (4, 1) | 22.112 | 22.819 | 22.469 | 23.495 | 308.3 | 3.69% |

#### BF16，head_size=64，T=128

| 头配置 (n_qh, n_kh) | 分段式 (µs) | 交错式 (µs) | 残差+分段 (µs) | 残差+交错 (µs) | 基线带宽 (GB/s) | 最大 CV |
|---|---:|---:|---:|---:|---:|---:|
| (8, 8) | 8.874 | 8.766 | 9.246 | 9.201 | 64.6 | 0.64% |
| (4, 1) | 10.004 | 10.169 | 10.396 | 10.536 | 21.3 | 0.45% |

#### BF16，head_size=64，T=2048

| 头配置 (n_qh, n_kh) | 分段式 (µs) | 交错式 (µs) | 残差+分段 (µs) | 残差+交错 (µs) | 基线带宽 (GB/s) | 最大 CV |
|---|---:|---:|---:|---:|---:|---:|
| (8, 8) | 34.923 | 35.069 | 37.969 | 38.236 | 262.7 | 0.90% |
| (4, 1) | 17.773 | 18.002 | 18.961 | 19.094 | 191.8 | 1.40% |

### 汇总

| 分组 | 配置数 | 中位耗时范围 (µs) | 有效带宽范围 (GB/s) | 最大 CV |
|---|---:|---:|---:|---:|
| BF16 / head_size=128 | 80 | 7.080 – 163.373 | 14.7 – 662.5 | 4.06% |
| FP16 / head_size=128 | 32 | 7.183 – 38.305 | 57.5 – 706.6 | 3.69% |
| BF16 / head_size=64 | 16 | 8.766 – 38.236 | 21.0 – 352.1 | 1.40% |
| 全部 | 128 | 7.080 – 163.373 | 14.7 – 706.6 | 4.06% |

带宽范围上界（FP16 706.6、BF16 662.5 GB/s）均出现在残差配置——字节更多的配置表观带宽更高；分段式无残差基线的带宽峰值为 BF16 493.4 / FP16 481.6 GB/s（均为 T=8192 或 T=2048 的 (8,8) 配置）。

### 配置间开销比

中位耗时比（括号内为同分组内的范围），基线 = 同 shape 的分段式、无残差配置：

| 分组 | 交错式 / 分段式 | 残差 / 无残差 | 交错+残差 / 基线 |
|---|---:|---:|---:|
| BF16 / head_size=128 | 1.010（0.983 – 1.037） | 1.075（1.018 – 1.117） | 1.081（1.031 – 1.145） |
| FP16 / head_size=128 | 1.010（0.987 – 1.032） | 1.019（0.993 – 1.058） | 1.041（1.001 – 1.063） |
| BF16 / head_size=64 | 1.009（0.988 – 1.016） | 1.054（1.039 – 1.087） | 1.064（1.037 – 1.095） |

## 相关实现与测试入口

- [Python 公开接口（JIT 声明）](../aiter/ops/fuse_rms_mrope.py)
- [native 入口、参数检查与 kernel 分发](../csrc/kernels/fuse_rms_mrope.cu)
- [功能测试与内置基准](../op_tests/test_fuse_rms_mrope.py)
