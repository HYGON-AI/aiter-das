<!--
SPDX-License-Identifier: MIT
Copyright (c) 2026 Hygon Information Technology Co., Ltd.
-->

# rmsnorm_quant / add_rmsnorm_quant（含 rmsnorm / add_rmsnorm）

## 1. 算子功能

`module_rmsnorm_quant` 是一组「快 HIP」RMSNorm 实现，共四个入口，全部由同一个 kernel 模板实例化：

| 入口 | 功能 |
|---|---|
| `rmsnorm` | RMSNorm，输出同 dtype |
| `add_rmsnorm` | residual add + RMSNorm，同时写回 `residual_out` |
| `rmsnorm_quant` | RMSNorm + 融合动态量化 |
| `add_rmsnorm_quant` | residual add + RMSNorm + 融合动态量化 |

它与仓库既有的 `rmsnorm2d_fwd*`（CK / opus，`module_rmsnorm`）是**并列的两套实现**，不是替代关系。本次移植**没有**把它接进 `rmsnorm2d_fwd_with_dynamicquant` 等既有分发（原因见第 3 节）。

每一行独立计算：

| 符号 | 含义 |
|---|---|
| `M` | 行数（token 数） |
| `N` | 列数（hidden size），`N <= 8192` |
| `G` | `group_size`，量化分组宽度；`0` 表示 per-token |

```text
# add_* 入口先做 residual add，并把和写回 residual_out
x[i,j]        = input[i,j] + residual_in[i,j]
residual_out  = x

rms_rcp       = rsqrt( sum_j( x[i,j]^2 ) / N + eps )
y[i,j]        = x[i,j] * rms_rcp * (weight[j] + (gemma_norm ? 1 : 0))

# *_quant 入口再做动态量化
amax          = max( 1e-10, max_{j in group}( |y[i,j]| ) )
scale         = amax / dtype_max
out[i,j]      = y[i,j] / scale
```

累加、归一化与求 amax 在 FP32 上进行；读写为 FP16/BF16（量化输出为 INT8 或 FP8）。
`amax` 的下界 `1e-10`（`kAmaxFloor`）保证全零组也能得到有限非零 scale。

**相对 `rmsnorm2d_fwd_with_dynamicquant` 的增量能力**：

- **`group_size`**：1×G 分组（block）量化，而不只是 per-token。`G` 必须满足 `G % thread_data_size == 0`、`G <= 64 * thread_data_size`，且 `G / thread_data_size` 是 2 的幂。
- **`shuffle_scale`**：转置 / 交织的 scale 布局，供 ASM GEMM 直接消费。
- **e8m0 1 字节 block scale**：传入 1 字节 scale 张量即启用（需 `group_size != 0`）。**仅 gfx938 / gfx946**，见第 2 节。

**边界语义**：

- 输入必须是 2-D `[M, N]`；按行非连续可以（读写都用 `stride(0)`）。
- `N > 8192` 直接报错，不做分块回退。
- 量化输出 dtype：INT8 全架构可用；FP8 仅 gfx938 / gfx946。
- `weight` 与 `input` 同 dtype。

**负向范围**：

- 只支持 FP16 与 BF16 输入；FP32 报错。
- **不支持 FP4 输出**：上游有 `fp4x2` 路径，HCU 无 e2m1 硬件，已整段裁掉。
- **不支持 `scale_layout_m32k4`**：该布局为 gfx1250 的 MXFP8 ASM GEMM 服务，本仓库无对应消费方，参数保留但运行时报错。
- 无 smoothquant（对应能力见 `rmsnorm2d_fwd_with_smoothquant`）。
- 无 autograd，仅供推理使用。

## 2. 架构裁剪

| 能力 | gfx936 | gfx938 | gfx946 |
|---|---|---|---|
| INT8 输出 + FP32 per-token / 分组 scale | ✅ | ✅ | ✅ |
| `shuffle_scale`（FP32 scale） | ✅ | ✅ | ✅ |
| FP8 输出 | ❌ 运行时报错 | ✅ | ✅ |
| e8m0 1 字节 block scale | ❌ 运行时报错 | ✅ | ✅ |
| FP4 输出 | ❌ 不存在 | ❌ 不存在 | ❌ 不存在 |
| `scale_layout_m32k4` | ❌ 报错 | ❌ 报错 | ❌ 报错 |

FP8 与 e8m0 由 `GPU_ENABLE_FP8` 控制，该宏由 [core.py](../aiter/jit/core.py) 按 `GPU_ARCHS` 自动为 host 与 device 两侧同时定义（`gfx938` / `gfx946` / `gfx92a`，或 `AITER_ENABLE_FP8=1`）。

这个门控不是保守起见：gfx936 上 `opus::fp32_to_fp8_packed_x2` 没有对应指令，其实现直接返回 0，**编进去会静默写出全零而不是报错**。因此 gfx936 的构建里不编译任何 FP8 kernel，入口直接拒绝：

```text
[AITER] .../rmsnorm_quant_kernels.cu:541 rmsnorm_quant fp8 output needs hardware
fp8 conversion, which this build does not have (gfx936). Use i8 output, or build
for gfx938 / gfx946.
```

e8m0 与 FP8 共用门控：e8m0 block scale 只为 mxfp8 输出服务（INT8 输出配 e8m0 在所有架构上都被拒绝），所以 gfx936 上它本就不可达。

这些拒绝是**可捕获的 Python 异常**，不是 `abort()`。本仓库的 `AITER_CHECK` 默认直接终止进程；四个入口都在函数开头放了 `aiter_detail::AiterThrowGuard`，把该作用域内的检查改为抛异常（该 guard 本次从上游一并补入 [aiter_hip_common.h](../csrc/include/aiter_hip_common.h)）。

## 3. 为什么不接进既有分发

上游 AITER 把这四个入口接成了 `rmsnorm2d_fwd_with_dynamicquant` / `_with_add_dynamicquant` / `rmsnorm2d_fwd_with_add` 的快路径，由 `_use_hip_common(input, ...)` 按 shape 选路。本次**没有**照搬，原因是实测结论不支持一个固定阈值：

- 在 `N >= 4096` 且 `M >= 2048` 时，`rmsnorm_quant` 比 CK 快 20%~59%（见第 6 节）；
- 在 `N = 1024` 时它慢 1.6×~2.4×；
- 不带量化的 `rmsnorm` / `add_rmsnorm` 在两架构上几乎全程慢于 CK；
- 且 gfx936 与 gfx938 的分界点并不一致（`add_rmsnorm_quant` 在 gfx938 上 `N>=4096` 领先，在 gfx936 上同区间落后 7%~16%）。

上游阈值按 CDNA 标定，直接沿用会在相当大的区间造成回退。因此这四个入口作为**新增 API** 导出：需要分组 / 交织 / e8m0 scale 布局的调用方直接调它们（CK 路径没有这些能力），既有 per-token 调用方继续走 CK，零回归风险。接入与否留作单独决策。

## 4. 接口与参数

```python
import aiter

# 融合量化
aiter.rmsnorm_quant(out, input, scale, weight, epsilon,
                    group_size=0, shuffle_scale=False,
                    gemma_norm=False, scale_layout_m32k4=False)

aiter.add_rmsnorm_quant(out, input, residual_in, residual_out, scale, weight,
                        epsilon, group_size=0, shuffle_scale=False,
                        gemma_norm=False, scale_layout_m32k4=False)

# 不带量化
aiter.rmsnorm(out, input, weight, epsilon, gemma_norm=False)
aiter.add_rmsnorm(out, input, residual_in, residual_out, weight, epsilon,
                  gemma_norm=False)
```

| 参数 | 类型 / 形状 | 含义与约束 |
|---|---|---|
| `input` | `[M, N]`，FP16 / BF16 | 2-D；允许按行非连续；`N <= 8192` |
| `out` | 同 `input` 形状 | `rmsnorm` / `add_rmsnorm`：同 `input` dtype。`*_quant`：INT8，或 FP8（gfx938/946） |
| `residual_in` / `residual_out` | 同 `input` 形状与 dtype | 仅 `add_*` 入口；`residual_out` 写入 `input + residual_in` |
| `scale` | FP32 或 1 字节 | `group_size == 0`：`[M, 1]`。分组且不 shuffle：`[M, N/G]`。分组且 shuffle：`[N/G, M]`（即转置）。1 字节 dtype 触发 e8m0 |
| `weight` | `[N]`，与 `input` 同 dtype | — |
| `epsilon` | `float` | RMS 平滑项 |
| `group_size` | `int`，默认 `0` | `0` 为 per-token；否则见第 1 节约束 |
| `shuffle_scale` | `bool`，默认 `False` | FP32 scale 时为转置布局；e8m0 + `G==32` 时为 MX swizzle 布局 |
| `gemma_norm` | `bool`，默认 `False` | 为真时权重按 `weight + 1` 使用 |
| `scale_layout_m32k4` | `bool`，默认 `False` | 仅为签名兼容保留，传 `True` 报错 |
| 返回值 | `None` | 结果写入 out 张量 |

四个入口都是 `@compile_ops(..., develop=True)`，参数经 `aiter_tensor_t` 编组后进 native。

> `develop=True` 的编组路径在**源码树**里需要先预构建一次 `module_custom_all_reduce`（`aiter/utility/dtypes.py` 从该模块取 pybind 的 `aiter_tensor_t` 类，而 `get_module()` 只 import 不构建）。wheel 安装不受影响。

## 5. 使用方式

```python
import torch
import aiter
from aiter import dtypes

device = torch.device("cuda:0")
M, N = 2048, 4096

x = torch.randn(M, N, device=device, dtype=torch.bfloat16)
w = torch.randn(N, device=device, dtype=torch.bfloat16)
res = torch.randn(M, N, device=device, dtype=torch.bfloat16)

# per-token INT8
out = torch.empty(M, N, device=device, dtype=dtypes.i8)
ys = torch.empty(M, 1, device=device, dtype=dtypes.fp32)
aiter.rmsnorm_quant(out, x, ys, w, 1e-5)

# 1x128 分组量化 + residual
res_out = torch.empty_like(x)
ys_g = torch.empty(M, N // 128, device=device, dtype=dtypes.fp32)
aiter.add_rmsnorm_quant(out, x, res, res_out, ys_g, w, 1e-5, group_size=128)

# 1x128 分组 + 转置 scale 布局
ys_t = torch.empty(N // 128, M, device=device, dtype=dtypes.fp32)
aiter.rmsnorm_quant(out, x, ys_t, w, 1e-5, 128, True)

# 不带量化
y = torch.empty_like(x)
aiter.rmsnorm(y, x, w, 1e-5)
aiter.add_rmsnorm(y, x, res, res_out, w, 1e-5)
```

### 功能验证入口

测试并入既有的 [test_rmsnorm2dFusedAddQuant.py](../op_tests/test_rmsnorm2dFusedAddQuant.py)。**mode 1~6 是 CK 路径的原有用例，未作任何改动**；新增 mode 7~14 覆盖本组算子，并额外接受 `-m / -n / -d / -q`（只影响 7~14）：

| mode | 覆盖 |
|---:|---|
| 7 / 8 | `rmsnorm` / `add_rmsnorm`（不量化） |
| 9 / 10 | `rmsnorm_quant` / `add_rmsnorm_quant`，per-token |
| 11 / 12 | 同上，1×128 分组 |
| 13 / 14 | 同上，1×128 分组 + `shuffle_scale` |

```bash
# 默认 shape 集（m ∈ {1,8,128,2048} × n ∈ {1024,2048,4096,5120,6144,8192}）
python -B op_tests/test_rmsnorm2dFusedAddQuant.py --mode 9

# FP8 输出（gfx938 / gfx946；gfx936 上自动跳过并打印原因）
python -B op_tests/test_rmsnorm2dFusedAddQuant.py --mode 10 -q fp8

# 指定规模与 dtype
python -B op_tests/test_rmsnorm2dFusedAddQuant.py --mode 12 -q i8 -m 128 2048 -n 4096 -d fp16
```

每个 shape 都对 torch 参考实现比对输出、`residual_out`（带 residual 时）与 scale；在 CK 路径也支持的 shape 上（不量化、per-token INT8）同时打印 CK 的耗时作为性能参照。

默认 `-n` 里包含 5120 与 6144：`4096 < N <= 6144` 区间派发到每线程 24 元素，而 24 不能承载 32 或 128 宽的分组，必须回退到另一组 `(BlockSize, thread_data_size)`——这是唯一能走到该回退分支的 shape。

## 6. 实现与架构范围

通用 HIP C++（[rmsnorm_quant_kernels.cu](../csrc/kernels/rmsnorm_quant_kernels.cu)），基于 opus 的向量类型与访存抽象。按 `N` 选择 `(BlockSize, thread_data_size)`，一个 block 处理一行：

| `N` | BlockSize | 每线程元素 | 分组量化时的例外 |
|---:|---:|---:|---|
| ≤ 512 | 64 | 8 | — |
| ≤ 1024 | 128 | 8 | — |
| ≤ 2048 | 256 | 8 | — |
| ≤ 4096 | 256 | 16 | — |
| ≤ 6144 | 256 | 24 | `G % 24 != 0` 时改用 512 × 16 |
| ≤ 8192 | 256 | 32 | 带 residual 的分组量化改用 512 × 16 |

平方和与 per-token amax 归约走 `block_reduce`；分组 amax 走 `multithread_reduce`（组内线程间 DPP 归约，无 LDS）。

### 五处 HCU 相关实现要点

**(1) 打包 FP8 转换的指令编码。** 上游 `fp32_to_fp8_scaled_x2` 用三操作数的 `v_cvt_pk_fp8_f32 %0, %1, %2`，这在 HCU 上**不汇编**（gfx938 需要四操作数的 `op_sel` 形式，gfx946 走 `__builtin_hcu_cvt_pk_fp8_f32`）。本次把 [aiter_opus_plus.h](../csrc/include/aiter_opus_plus.h) 的饱和钳位保留在汇编里、转换改为委托给 `opus::fp32_to_fp8_packed_x2`（opus.hpp 已经正确编码了两种架构）。BF8 的同族 helper 一并修正。

> 这段代码在本模块之前**没有任何调用方**，所以错误编码一直没被编译到。「本仓库存在从未编译过的死代码」在接通任何上游 helper 时都要先验。

**(2) BF16 输出的舍入模式。** `store_vector` 把 FP32 结果转成 BF16 时走 `opus::cast`，其舍入由 `OPUS_FP32_to_BF16_DEFAULT` 决定。本模块的 JIT 条目传 `5`，与上游一致：

| 模式 | 实现 | 本模块是否可用 |
|---:|---|---|
| 2（仓库默认） | 截断，1 条指令 | 可用但精度不够：相对误差可达 2^-8，对 torch 参考比对不可靠 |
| 0 | 标准软件 RNE，**带分支** | 数值等价于 5（有限输入），但分支在逐元素循环里是实打实的开销 |
| 5 | 优化软件 RNE，无分支 | 本次选用 |

仓库的 `opus.hpp` 原本没有模式 5，本次把上游的 `fp32_to_bf16_rtn_fast_raw` 与对应分支一并补入（纯新增，其他模块不受影响）。实测把 `rmsnorm` 在 `M=8192, N=8192` 上从 313.8 µs 降到 275.5 µs（−12%），`N=4096` 上从 177.1 µs 降到 140.0 µs（−21%）。

**(3) 内联汇编的读写操作数。** 上游三处汇编把同一个变量同时写成 `"=v"` 输出与 `"v"` 输入（`v_pk_mul_f32`、`v_max3_f32`、`v_rcp_f32`）。`"=v"` 是只写约束，寄存器分配器可以把输出放到指令仍需读取的源寄存器上。本实现：

- `v_pk_mul_f32` → 改用 `aiter::pk_mul_f32`（结果写入独立变量）；
- `v_max3_f32` → TU 内的 `max3_f32` helper，输出写入独立变量（`V_MAX3_F32` 是 GFX9 VOP3 指令，HCU 支持）；
- `v_rcp_f32` → 改用 `__builtin_amdgcn_rcpf`，本仓库其他 kernel 已是这个写法。

**(4) opus 标量到 float 的转换必须用 `opus::cast`。** [opus.hpp](../csrc/include/opus/opus.hpp) 按编译器版本定义 `bf16_t`：clang ≥ 20 是真浮点 `__bf16`，clang < 20 是 `unsigned short`（整数）。本 kernel 的 `DTYPE_I` 来自 `hip2opus<scalar_t>`，所以对 `input` / `residual_in` / `weight` 一律用 `opus::cast<float>`——用 `static_cast<float>` 在 DTK 26.04（clang 18）上是**整数转换**，会静默产出量级完全错误的结果，而 DTK 26.10（clang 22）上看不出问题。

**(5) 每 block 行数（`num_row_per_block`）保持上游的 1。** kernel 模板本身支持一个 block 处理多行并带预取，上游固定为 1。按 R12 的要求在 gfx938 上实测了 1 / 2 / 4 / 8（BF16，不量化）：

| shape | 1 | 2 | 4 |
|---|---:|---:|---:|
| `M=2048, N=1024` | **27.6** | 29.5 | 28.9 |
| `M=8192, N=1024` | 85.6 | 81.9 | **76.5** |
| `M=2048, N=4096` | **42.4** | 47.1 | 45.1 |
| `M=8192, N=4096` | 140.0 | 145.4 | **136.0** |
| `M=2048, N=8192` | **76.1** | 111.6 | 223.2 |
| `M=8192, N=8192` | **275.5** | 399.9 | 799.2 |

没有一个取值全面占优：`num_row > 1` 只在 `M = 8192` 上领先 3%~11%，在 `M <= 2048` 上落后，在 `N = 8192` 上则劣化 1.5×~2.9×（每线程 32 元素时寄存器压力过大）。因此保留 1 —— 结论是「上游常量在 HCU 上本就是对的」，但这是实测得出的，不是沿用假设。

同时也实测了 load 的 cache policy：上游在单次 load 时用 `GROUP_NT`（non-temporal），改成 `RT` 在所有 shape 上都无改善（`M=8192, N=1024` 107.6 → 107.1 µs），因此保留上游取值。

native 入口编入 `module_rmsnorm_quant`，首次调用时 JIT 编译。

## 7. 性能报告

测试日期 2026-11-09。基线为仓库既有的 CK / opus 实现：`rmsnorm2d_fwd`（不量化）与 `rmsnorm2d_fwd_with_dynamicquant` / `_with_add_dynamicquant`（per-token INT8）。

### 测试环境与计时口径

| 项目 | gfx936 | gfx938 |
|---|---|---|
| 产品型号 | BW1000 64G | BW1100 |
| 计算单元（CU）数 | 80 | 64 |
| PyTorch | 2.11.0 | 2.11.0 |
| AITER 编译 | JIT，DTK 26.04（clang 18） | JIT，DTK 26.10（clang 22） |
| 输入 | BF16，`randn`，连续 | 同左 |

- **计时取 device 侧 kernel 耗时**（torch profiler 读 kernel duration），不是 wall clock。这一点是必须的：`develop=True` 的编组路径每次调用约 60 µs CPU 开销，而被测 kernel 在小 shape 上只有几 µs，wall clock 完全被开销淹没，无法回答性能问题。两条路径用同一份输入、同一套采集。
- 数据在整卡空闲时采集（`rocm-smi --showuse` 全 0）。
- JIT 编译与预热不计入样本。
- 表中 `hip/ck` < 1 表示本算子更快。

### 不量化（`rmsnorm` vs `rmsnorm2d_fwd`）

| `M` | `N` | gfx936 hip/ck | gfx938 hip/ck |
|---:|---:|---:|---:|
| 1 | 1024 | 1.08 | 1.22 |
| 128 | 1024 | 1.83 | 2.40 |
| 2048 | 1024 | 2.10 | 2.23 |
| 8192 | 1024 | 1.90 | 2.19 |
| 1 | 4096 | 1.13 | 1.18 |
| 128 | 4096 | 1.79 | 2.10 |
| 2048 | 4096 | 1.26 | 1.10 |
| 8192 | 4096 | 1.31 | 1.06 |
| 1 | 8192 | 1.04 | **0.94** |
| 128 | 8192 | 1.52 | 1.64 |
| 2048 | 8192 | 1.69 | 1.16 |
| 8192 | 8192 | 1.77 | 1.18 |

### per-token INT8 量化（`rmsnorm_quant` vs `rmsnorm2d_fwd_with_dynamicquant`）

| `M` | `N` | gfx936 hip/ck | gfx938 hip/ck |
|---:|---:|---:|---:|
| 1 | 1024 | 1.03 | 1.09 |
| 128 | 1024 | 1.87 | 2.43 |
| 2048 | 1024 | 1.87 | 2.13 |
| 8192 | 1024 | 1.69 | 1.95 |
| 1 | 4096 | 1.03 | **0.99** |
| 128 | 4096 | 1.55 | 1.99 |
| 2048 | 4096 | **0.81** | **0.83** |
| 8192 | 4096 | **0.77** | **0.77** |
| 1 | 8192 | **0.85** | **0.86** |
| 128 | 8192 | 1.13 | 1.49 |
| 2048 | 8192 | **0.77** | **0.67** |
| 8192 | 8192 | **0.78** | **0.63** |

### per-token INT8 量化 + residual（`add_rmsnorm_quant` vs `_with_add_dynamicquant`）

| `M` | `N` | gfx936 hip/ck | gfx938 hip/ck |
|---:|---:|---:|---:|
| 1 | 1024 | **0.88** | **0.94** |
| 128 | 1024 | 1.61 | 3.05 |
| 2048 | 1024 | 1.56 | 1.96 |
| 8192 | 1024 | 1.73 | 1.83 |
| 1 | 4096 | **0.95** | **0.94** |
| 128 | 4096 | 1.29 | 2.30 |
| 2048 | 4096 | 1.07 | **0.92** |
| 8192 | 4096 | 1.14 | **0.85** |
| 1 | 8192 | **0.78** | **0.77** |
| 128 | 8192 | **0.94** | 1.51 |
| 2048 | 8192 | 1.09 | **0.86** |
| 8192 | 8192 | 1.16 | **0.82** |

### 结果分析

- **融合量化在大 shape 上明确领先**：`N >= 4096` 且 `M >= 2048` 时，`rmsnorm_quant` 在 gfx938 上快 20%~59%、在 gfx936 上快 24%~30%。最高点 `M=8192, N=8192` 达到 1001 GB/s，而 CK 在同 shape 只有 627 GB/s —— CK 的量化路径在这个规模上明显受限，本实现把量化融进 norm 的单次读写里。
- **`N = 1024` 全线落后 1.6×~3.0×**。本实现一个 block 只处理一行，`N=1024` 时一行只有 2 KB，每 block 固定开销（block 启动、`block_reduce` 的 `__syncthreads`、4 个 buffer 资源描述符建立）占比过高；CK 在该宽度用的是按 shape 生成的调优实例。`num_row_per_block` 调优（第 6 节）只能收回其中约 11%。
- **`M = 128` 一带是另一个弱区**，且与 `N` 无关地停在 11~21 µs。这是小 grid（128 个 block 对 64~80 个 CU）下每个 CU 都要冷填一次指令 cache 的代价：把模板里永不执行的预取实例用 `if constexpr(num_row > 1)` 真正消除掉（上游依赖 `r < num_row - 1` 折叠，不保证不生成代码）后，该区间从 18.4 µs 降到 14.1 µs，但没有完全消除。
- **不量化路径不建议用本实现**：两架构在绝大多数 shape 上都慢于 CK，唯一例外是 gfx938 的 `M=1, N=8192`。它存在的意义是与量化入口共用同一个 kernel 模板、以及给上游 API 兼容。
- **分组 / 交织 / e8m0 scale 布局没有 CK 对标实现**，按规划只记录为后续基线，见下表。
- **适用范围**：结论限定于上列设备、软件版本、BF16 输入与所列 shape；未测 FP16 的性能矩阵（正确性已覆盖），未测 FP8 输出的性能矩阵，未测端到端吞吐。

### 分组 / 交织 / e8m0 基线（gfx938，无 CK 对标）

µs，device 侧 kernel 耗时，BF16 输入。`G = 0` 即 per-token，列在表里作为同 kernel 内的参照点。

| `M` | `N` | `G` | i8 | i8 + shuffle | fp8 | fp8 + e8m0 |
|---:|---:|---:|---:|---:|---:|---:|
| 2048 | 8192 | 0 | 57.62 | — | 58.67 | — |
| 2048 | 8192 | 32 | 85.93 | 96.51 | 92.87 | 92.65 |
| 2048 | 8192 | 128 | 85.85 | 85.57 | 93.38 | 93.26 |
| 8192 | 8192 | 0 | 197.82 | — | 201.99 | — |
| 8192 | 8192 | 32 | 310.50 | 354.29 | 337.73 | 337.00 |
| 8192 | 8192 | 128 | 311.32 | 310.41 | 341.91 | 341.29 |
| 8192 | 4096 | 0 | 139.70 | — | 141.70 | — |
| 8192 | 4096 | 32 | 168.38 | 178.63 | 170.10 | 170.13 |
| 8192 | 4096 | 128 | 169.31 | 163.12 | 169.77 | 170.81 |

同 shape 的 `add_rmsnorm_quant`（带 residual）：`M=8192, N=8192` 下 `G=0` 352.91 µs、`G=128` 428.18 µs、`G=32` 430.46 µs。

三条可用于后续调优的观察：

- **分组量化比 per-token 贵约 45%~57%**（`2048/8192`：57.62 → 85.85 µs）。per-token 走 `interleave=true` 的交织访存，分组必须走 `interleave=false`（组要落在连续的整线程上），访存模式因此不同；归约也从 `block_reduce` 换成 `multithread_reduce`。
- **`shuffle_scale` 在 `G=128` 上基本免费，在 `G=32` 上贵 11%~14%**（`8192/8192`：310.50 → 354.29 µs）。`G=32` 走的是 MX swizzle 索引（`mx_scale_shuffle_idx`），scale 字节写出是散列的；`G!=32` 只是行列转置。
- **e8m0 1 字节 scale 与 FP32 scale 等价耗时**（337.73 vs 337.00 µs），即 e8m0 的指数提取没有额外成本；FP8 输出比 INT8 贵约 8%~10%。

## 8. 验证记录

| 架构 | 正确性 | 备注 |
|---|---|---|
| gfx938 | **192 / 192 PASS** | mode 7~14 × {i8, fp8} × 12 shape；`M ∈ {1,8,128,2048}` × `N ∈ {1024,4096,8192}` |
| gfx936 | **96 / 96 PASS** | mode 7~14 × i8 × 12 shape；FP8 按设计不可用 |
| gfx946 | 见第 9 节 | 缩减规模（`-m 1 8 -n 1024`），只验功能与多 die |

G6（低精度裁剪确认）在两架构上逐项核对，6/6 PASS（核对脚本是临时产物，未入库）：

| 检查项 | gfx936 | gfx938 |
|---|---|---|
| FP8 输出 | 拒绝（带架构说明） | 接受 |
| e8m0 1 字节 scale | 拒绝 | 接受 |
| INT8 + e8m0 组合 | 拒绝 | 拒绝 |
| `.so` 内 FP8 kernel 符号数 | 0 | 32 |
| FP4 入口 | 不存在 | 不存在 |

gfx936 的 BF16 结果正确是本次的一个关键确认点：该架构是 clang 18，`bf16_t` 是整数类型，L1 阶段同族 kernel 正是在这里出过 100% 数值错误（见第 6 节要点 4）。

## 9. 版本与数据追溯

| 项目 | 标识 |
|---|---|
| 源码基线 | commit `c7e01755`（L1 合入后的 main） |
| 上游参考 | `csrc/kernels/rmsnorm_quant_kernels.cu`（732 行） |
| 功能验证 | 2026-11-09，gfx938 192/192、gfx936 96/96 PASS |
| 性能数据采集 | 2026-11-09，BW1000 64G / gfx936 与 BW1100 / gfx938，均为空闲整卡 |

- [Python 接口](../aiter/ops/rmsnorm.py)
- [native kernel 实现](../csrc/kernels/rmsnorm_quant_kernels.cu)
- [native 入口声明](../csrc/include/rmsnorm_quant.h)、[pybind 模块](../csrc/pybind/rmsnorm_quant_pybind.cu)
- [e8m0 scale 工具头](../csrc/include/mx_quant_utils.h)、[amax 下界](../csrc/include/quant_amax_floor.h)
- [功能测试](../op_tests/test_rmsnorm2dFusedAddQuant.py)
- [JIT 编译配置](../aiter/jit/optCompilerConfig.json)
