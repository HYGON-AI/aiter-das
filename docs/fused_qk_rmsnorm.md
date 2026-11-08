<!--
SPDX-License-Identifier: MIT
Copyright (c) 2026 Hygon Information Technology Co., Ltd.
-->

# fused_qk_rmsnorm

## 1. 算子功能

`fused_qk_rmsnorm` 用一次 kernel 启动同时对 Q 与 K 两个张量做 RMSNorm，面向注意力入口「QKV 投影之后、RoPE 之前」的 norm 阶段。相对于分别调用两次 `rmsnorm2d_fwd`，它省掉一次 kernel 启动与一次权重加载。

kernel 使用 2D grid：`blockIdx.y == 0` 处理 Q、`== 1` 处理 K，两路在不同 CU 上并行推进。对每一行独立计算：

| 符号 | 含义 |
|---|---|
| `M` | 行数（token 数），Q 与 K 必须相同 |
| `N1` / `N2` | Q / K 的列数，可以不同 |
| `eps` | RMS 的平滑项，Q 与 K 可取不同值 |

```text
rms_rcp = rsqrt( sum_j( x[i,j]^2 ) / N + eps )
out[i,j] = x[i,j] * rms_rcp * weight[j]
```

累加与乘法在 FP32 上进行，读写为 FP16/BF16。

**边界语义**：

- Q 与 K 的行数必须一致；列数 `N1`、`N2` 可以不同，kernel 按 `max(N1, N2)` 选择 BlockSize 与每线程数据量。
- 输入允许按行非连续（读取时使用 `stride(0)`），典型来源是对融合 QKV 投影结果做 `torch.split`。
- `weight` 必须连续，且与 `q`/`k` 同 dtype。
- `max(N1, N2) > 8192` 直接报错，不做分块回退。

**负向范围**：

- 只支持 FP16 与 BF16；FP32 输入报错。
- 不含 RoPE、不含量化、不写 KV cache —— 这些是 `fused_qk_norm_rope_cache_quant*` 系列的职责。
- 不支持 residual add（对应能力见 `rmsnorm2d_fwd_with_add`）。
- 无 autograd，仅供推理使用。

## 2. 接口与参数

```python
import aiter

aiter.fused_qk_rmsnorm(
    q_out_quantized=q_out,   # 输出张量，沿用上游参数名
    q=q, q_weight=q_weight, q_epsilon=1e-5,
    k_out=k_out,
    k=k, k_weight=k_weight, k_epsilon=1e-5,
)
```

接口保持与上游 AITER 相同的关键字契约，便于框架侧代码直接移植。三层入口：

| 入口 | 位置 | 说明 |
|---|---|---|
| `aiter.fused_qk_rmsnorm(...)` | [fused_qk_norm_rope_cache_quant.py](../aiter/ops/fused_qk_norm_rope_cache_quant.py) | 公开接口，按 `quant_type` 分发。本架构**仅实现 `QuantType.No`**，其余取值抛 `NotImplementedError` |
| `_fused_qk_rmsnorm(q_out, q, q_weight, q_eps, k_out, k, k_weight, k_eps)` | 同上 | host 侧包装：输出为 `None` 时自动分配，并按 `M` 在 fused kernel 与 CK 路径间选路（见第 3 节） |
| `_fused_qk_rmsnorm_kernel(...)` | 同上 | native 绑定，直接调 fused kernel，不做选路 |

| 参数 | 类型 / 形状 | 含义与约束 |
|---|---|---|
| `q` / `k` | `torch.Tensor [M, N1]` / `[M, N2]`，FP16 或 BF16 | 必须 2-D、同 dtype、行数相同；允许按行非连续 |
| `q_weight` / `k_weight` | `torch.Tensor [N1]` / `[N2]` | 1-D、连续、与 `q` 同 dtype |
| `q_epsilon` / `k_epsilon` | Python `float` | 可取不同值 |
| `q_out_quantized` / `k_out` | 可选 `torch.Tensor`，形状同 `q` / `k` | 为 `None` 时由 `_fused_qk_rmsnorm` 分配；传入时原地写入 |
| `quant_type` | 可选，默认 `QuantType.No` | 仅支持 `QuantType.No` |
| 返回值 | `None` | 结果写入 out 张量 |

其余上游关键字（`q_out_scale`、`q_out_unquantized`、`q_res_out`、`q_residual`、`gemma_norm`、`group_size`、`transpose_scale`）为保持签名兼容而保留，当前实现不使用。

**检查边界**：native 侧校验维度、dtype 一致性、`weight` 连续性与 `max(N1,N2) <= 8192`；Python 层不额外检查。

## 3. 选路阈值

`_fused_qk_rmsnorm` 按行数 `M` 选路：

```python
_FUSED_QK_MAX_M = int(os.environ.get("AITER_FUSED_QK_MAX_M", "8"))
# M <= 8  -> fused kernel（一次启动同时算 Q 与 K）
# M >  8  -> rmsnorm2d_fwd_out(q) + rmsnorm2d_fwd_out(k)（CK 路径）
```

fused kernel 的优势来自省掉一次启动与一次权重加载，但其单行吞吐低于 CK 的 `rmsnorm2d`，所以行数一多就会反超。本架构实测 crossover 在 `M = 8`（`M=8` 领先约 12%，`M=12` 落后约 7%），因此默认阈值取 8。换架构重新调优时用 `AITER_FUSED_QK_MAX_M` 覆盖。

> 上游 AITER 的阈值方向相反（`M < 16384` 全部走 fused），在本架构上会让 `M=64`~`65536` 区间慢 36%~52%，不可直接沿用。

大 `M` 的回退使用 `rmsnorm2d_fwd_out`（CK 实现的 out-参数形式）而非 `rms_norm_cu`：后者的 kernel 按连续布局索引输入，而本算子的 Q/K 常是 `torch.split` 得到的行视图，只有 CK 路径会读 `input.stride(0)`。

## 4. 使用方式

```python
import torch
import aiter

device = torch.device("cuda:0")
M, N1, N2 = 4, 1536, 512

# 典型来源：融合 QKV 投影的输出切分，q/k 为按行非连续的视图
qkv = torch.randn(M, N1 + N2, device=device, dtype=torch.bfloat16)
q, k = torch.split(qkv, [N1, N2], dim=-1)
q_weight = torch.randn(N1, device=device, dtype=torch.bfloat16)
k_weight = torch.randn(N2, device=device, dtype=torch.bfloat16)

q_out = torch.empty_like(q)
k_out = torch.empty_like(k)
aiter.fused_qk_rmsnorm(
    q_out_quantized=q_out, q=q, q_weight=q_weight, q_epsilon=1e-5,
    k_out=k_out, k=k, k_weight=k_weight, k_epsilon=1e-5,
)
```

让接口自行分配输出时，改用 host 包装并接收返回值：

```python
from aiter.ops.fused_qk_norm_rope_cache_quant import _fused_qk_rmsnorm

q_out, k_out = _fused_qk_rmsnorm(None, q, q_weight, 1e-5, None, k, k_weight, 1e-5)
```

### 功能验证入口

在仓库根目录运行：

```bash
# 全量：fp16 + bf16 × M ∈ {1,4,5,64,1024,8192,16384,32768,65536} × (N1,N2) 四组合
python -B op_tests/test_fused_qk_norm.py

# 指定规模
python -B op_tests/test_fused_qk_norm.py -d bf16 -m 1 8 64 -n1 1024 -n2 512

# 强制全程走 fused kernel（用于定位 crossover）
AITER_FUSED_QK_MAX_M=999999 python -B op_tests/test_fused_qk_norm.py -d bf16 -m 4 8 12 16
```

每个 shape 做 4 项比对：q / k 分别对 `rmsnorm2d_fwd` 与独立的 torch 参考实现各比一次。引入独立 torch 参考是必要的 —— `rmsnorm2d_fwd` 本身也是 AITER kernel，只和它比对无法发现两者共有的数值错误。

## 5. 实现与架构范围

通用 HIP C++（[fused_qk_norm.cu](../csrc/kernels/fused_qk_norm.cu)），基于 opus 的向量类型与访存抽象，无 kernelId 参数，各架构走同一份 kernel。按 `max(N1,N2)` 与 `M` 选择 `(BlockSize, thread_data_size, num_row)`：

| `max(N1,N2)` | BlockSize | 每线程元素 | `M >= 4096` 时每 block 行数 |
|---:|---:|---:|---:|
| ≤ 512 | 64 | 8 | 4 |
| ≤ 1024 | 128 | 8 | 4 |
| ≤ 2048 | 256 | 8 | 4 |
| ≤ 4096 | 256 | 16 | 2 |
| ≤ 6144 | 256 | 24 | 2 |
| ≤ 8192 | 256 | 32 | 2 |

`M < 4096` 时每 block 处理 1 行。平方和归约走 `block_reduce`；逐元素缩放走 `aiter::pk_mul_f32`（见下）。

### 两处 HCU 相关实现要点

**打包乘法的操作数约束。** `v_pk_mul_f32` 在 gfx92a / gfx936 / gfx938 / gfx946 上均可用，但**目的寄存器不能与源寄存器别名**：`"=v"` 是只写约束，寄存器分配器可以把输出放到指令仍需读取的源寄存器上。因此本实现把结果写入独立的局部变量后返回，与 [vec_convert.h](../csrc/include/ck_tile/vec_convert.h) 中既有的打包乘法 helper 写法一致（架构列表也取自该处）；非上述架构走两条 `v_mul_f32`，并对第一个输出使用 early-clobber 约束 `"=&v"`。

早期的就地写法（同一变量既作 `"=v"` 输出又作 `"v"` 输入）会随周边寄存器压力产生不同结果：在 DTK 26.10 工具链上正确，在 DTK 26.04 上 BF16 输出全错。

**opus 标量到 float 的转换必须用 `opus::cast`。** [opus.hpp](../csrc/include/opus/opus.hpp) 按编译器版本定义 `bf16_t`：

```cpp
#if __clang_major__ >= 20
REGISTER_DTYPE(bf16, __bf16)          // 真浮点类型
#else
REGISTER_DTYPE(bf16, unsigned short)  // 整数类型
#endif
```

所以在 clang < 20 的工具链上，`static_cast<float>(bf16_value)` 是**整数转换**（把位模式当整数），会静默产出量级完全错误的结果；而 `fp16_t` 在两个分支都是真浮点类型（`__fp16` / `_Float16`），因此只有 BF16 会坏。本 kernel 对输入与 weight 一律使用 `opus::cast<float>`。

> 这两点对所有搬运到 HCU 的 kernel 通用：带内联汇编时先对照 `vec_convert.h` 的既有写法，且把作用于 opus 标量的 `static_cast<float>` 当作需要修正的写法。对 torch 的 `scalar_t`（`c10::BFloat16`，有合规 `operator float()`）用 `static_cast<float>` 是安全的。

native 入口编入 `module_fused_qk_norm_rope_cache_quant_shuffle`，首次调用时 JIT 编译。

## 6. 性能报告

测试日期 2026-11-06。基准为**两次独立的 `rmsnorm2d_fwd` 调用**（即本算子未引入前框架侧的做法），正数表示本算子更快。

### 测试环境与计时口径

| 项目 | gfx936 | gfx938 |
|---|---|---|
| 产品型号 | BW1000 64G | BW1100 |
| 计算单元（CU）数 | 80 | 64 |
| 可见显存 | 65520 MiB | 147440 MiB |
| PyTorch / `torch.version.hip` | 2.11.0 / 6.3.26113 | 2.11.0 / 7.2.26365 |
| AITER 编译 | JIT，DTK 26.04（clang 18） | JIT，DTK 26.10（clang 22） |
| 输入 | BF16，`randn`，Q/K 为 `torch.split` 的行视图 | 同左 |
| 调用方式 | 公开 API eager 调用 | 同左 |

- 计时由 `op_tests/test_fused_qk_norm.py` 的 `perftest` 采集，两条路径使用同一份输入。
- **两架构的数据都在整卡空闲时采集**。首轮 gfx936 数据已作废：当时有其他任务占满一张卡（host load 19~45），同一 shape 的 `M=1` 测到 39.9 µs，空闲卡重测为 4.3 µs。测性能前须先确认卡空闲。
- JIT 编译与预热不计入样本。

### 结果（BF16）

`N1`/`N2` 取 `{1024, 1536}` × `{512, 1024}` 四组合，下表为各 `M` 上四组合的提升区间。

| `M` | gfx936 | gfx938 | 实际路径 |
|---:|---:|---:|---|
| 1 | **+100% ~ +124%** | **+93% ~ +118%** | fused kernel |
| 4 | +59% ~ +86% | +39% ~ +65% | fused kernel |
| 5 | +34% ~ +64% | +30% ~ +50% | fused kernel |
| 64 | ±0.9% | ±0.7% | CK 路径 |
| 1024 | −5.8% ~ +1.2% | −9.1% ~ +5.3% | CK 路径 |
| 8192 ~ 65536 | ±0.3% | ±0.7% | CK 路径 |

### 结果分析

- **收益集中在 `M ≤ 8`**，也就是 decode 阶段的小 batch 形态：`M=1` 两架构都约有 1 倍提升。这与实现方向一致 —— 该区间里 kernel 启动与权重加载占主导，fused 把两次合成一次。
- **`M > 8` 走 CK 路径，因此与基准同量级属预期**。`M ≥ 8192` 时绝对耗时 57~600 µs，两架构都收敛在 ±0.7% 内，这是「不慢于既有实现」最可信的一段。
- **`M = 1024` 一带的 ±10% 是噪声**，不是回退：该区间绝对耗时仅 14~22 µs，对该 shape 做 3 次独立复测的均值约 −2%。
- **适用范围**：结论限定于上列设备、软件版本、BF16 输入与所列 shape。未测 FP16 的性能矩阵（FP16 的正确性已覆盖）、未测端到端吞吐。FP16 的 crossover 略早于 BF16（`M=5` 时已接近持平），对 FP16 为主的使用方建议按自身 shape 实测后调整 `AITER_FUSED_QK_MAX_M`。

## 7. 验证记录

| 架构 | 正确性 | 备注 |
|---|---|---|
| gfx936 | **288 / 288 PASS** | fp16 + bf16 × 9 个 `M` × 4 组 `(N1,N2)`，每例 4 项比对 |
| gfx938 | **288 / 288 PASS** | 同上 |
| gfx946 | **12 / 12 PASS** | 缩减规模（`-m 1 5 64 -n1 1024 -n2 512`）；两个 XCD 各 1295 次 dispatch，负载均分 |

gfx946 为 perf model 环境，按规划只验功能与多 die，不验性能（该环境无法获得 kernel 计时）。

同时在 gfx936 / gfx938 上跑了 11 个既有算子测试做回归，无回归项。

## 8. 版本与数据追溯

| 项目 | 标识 |
|---|---|
| 源码基线 | commit `a620f2a05966c4009932af32914dec6296d83746` |
| 功能验证 | 2026-11-06，gfx936 / gfx938 各 288/288 PASS，gfx946 12/12 PASS |
| 性能数据采集 | 2026-11-06，BW1000 64G / gfx936 与 BW1100 / gfx938，均为空闲整卡 |

- [Python 接口与选路](../aiter/ops/fused_qk_norm_rope_cache_quant.py)
- [native kernel 实现](../csrc/kernels/fused_qk_norm.cu)
- [native 入口声明](../csrc/include/fused_qk_norm_rope_cache_quant.h)、[pybind 模块](../csrc/pybind/fused_qk_norm_rope_cache_quant_pybind.cu)
- [CK 回退路径](../csrc/py_itfs_ck/rmsnorm_ck_kernels.cu)、[其 Python 绑定](../aiter/ops/rmsnorm.py)
- [功能测试](../op_tests/test_fused_qk_norm.py)
- [JIT 编译配置](../aiter/jit/optCompilerConfig.json)
