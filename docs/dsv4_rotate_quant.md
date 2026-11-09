<!--
SPDX-License-Identifier: MIT
Copyright (c) 2026 Hygon Information Technology Co., Ltd.
-->

# rope_rotate_activation / rotate_activation

## 1. 算子功能

`module_dsv4_rotate_quant` 提供 DSV4 的「旋转激活」算子族：对最后一维做 Walsh-Hadamard 旋转，可选在旋转前对尾部 `rope_dim` 列做 GPT-J 风格（相邻偶奇配对，interleaved）的 RoPE。三个入口：

| 入口 | 功能 | 架构 |
|---|---|---|
| `rotate_activation` | 仅 Hadamard 旋转，原 dtype 输出 | 全部 |
| `rope_rotate_activation` | RoPE（尾部 `rope_dim`）+ Hadamard 旋转，原 dtype 输出 | 全部 |
| `rope_rotate_activation_fp8quant` | 上者 + 1×G 分组 FP8 量化 | gfx938 / gfx946 |

输入形状为 `[..., head_num, dim]`，每一行（即每个 head）独立计算：

| 符号 | 含义 |
|---|---|
| `m` | 总行数 = `numel / dim`，必须是 `head_num` 的整数倍 |
| `head_num` | 每 token 的 head 数，必须是 2 的幂 |
| `dim` | 最后一维，必须是 `128 / 256 / 512 / 1024` 之一 |
| `rope_dim` | 参与 RoPE 的尾部列数，偶数，且能被 kernel 的 `vec_size` 整除 |

```text
# RoPE（仅尾部 rope_dim 列，j 为该区间内的偶数下标，p = positions[token]）
x[i, j]   = x[i, j]   * cos[p, j/2] - x[i, j+1] * sin[p, j/2]
x[i, j+1] = x[i, j+1] * cos[p, j/2] + x[i, j]   * sin[p, j/2]

# Hadamard 旋转（dim 维 WHT，再按 1/sqrt(dim) 归一化）
out[i, :] = H_dim @ x[i, :] / sqrt(dim)

# fp8 入口再做 1xG 分组量化
amax          = max( 1e-10, max_{j in group}( |out[i,j]| ) )
out_scale[..] = amax / fp8_max
out_fp8[i,j]  = out[i,j] / out_scale
```

旋转在 FP32 上进行，读写为 FP16/BF16（量化输出为 FP8）。

Hadamard 蝶形分两段：`log2(vec_size)` 级在线程内的寄存器向量上完成，其余 `log2(dim) - log2(vec_size)` 级跨线程完成（lane 交换）。

**边界语义**：

- `out` 与 `input` 的 `stride(-1)` 必须为 1；行间步长读 `stride(-2)`，可以非连续。
- `cos` / `sin` 与 `input` 同 dtype，`stride(-1) == 1`，最后一维 `>= rope_dim / 2`。
- `positions` 必须是 int64，元素数 `>= m / head_num`。
- `do_rotate_act=False` 时跳过 Hadamard，只做 RoPE（并在 fp8 入口继续量化）。

**负向范围**：

- 只支持 FP16 与 BF16 输入。
- `dim` 不在 `{128, 256, 512, 1024}` 内直接报错，没有通用回退。
- **不支持 FP4 输出**，见第 2 节。
- 不含 rmsnorm、不写 KV cache（上游的 `rmsnorm_rope_rotate_activation_fp4quant_kvcache` 未移植）。
- 无 autograd，仅供推理使用。

## 2. 架构裁剪

上游同一个 TU（1544 行）里有六个入口，本次只移植三个：

| 上游入口 | 处置 | 原因 |
|---|---|---|
| `rotate_activation` | ✅ 移植 | — |
| `rope_rotate_activation` | ✅ 移植 | 本次点名的算子 |
| `rope_rotate_activation_fp8quant` | ✅ 条件编译（`GPU_ENABLE_FP8`） | gfx936 无打包 FP8 转换指令 |
| `rotate_activation_fp4quant` | ❌ 删除 | gfx936/938/946 均无 e2m1 硬件 |
| `rope_rotate_activation_fp4quant` | ❌ 删除 | 同上 |
| `rmsnorm_rope_rotate_activation_fp4quant_kvcache` | ❌ 删除 | 同上（整个 kernel 只服务 fp4 KV cache） |

删掉三个 fp4 入口之后，随之删除的还有：e8m0 scale 布局 helper（`store_scale_e8m0`）、KV fp4 预洗牌 helper（4 个）、以及两个保留 kernel 里的 `DTYPE_O` / `fp4quant` 模板分支 —— 它们的输出类型现在恒等于输入类型。移植后的 TU 约 600 行。

这不只是清理：第 5 节的实测说明**代码体积本身在小 grid 下是可测量的开销**，所以保留不可达的 fp4 分支有实际代价。

Python 侧 `rope_rotate_activation` 仍按 `out.dtype` 分发；传入 `fp4x2` 输出时抛 `NotImplementedError` 并说明原因，而不是静默走错路径。

## 3. 关于 lane 交换内置函数

移植前把 `permlanex16` 登记为本算子的首要风险（HCU 可用性未知）。结论是**风险不存在**：上游的 lane 交换 helper 本身就带 `#if defined(__GFX9__)` 分支，在 GFX9 上走 `ds_bpermute` 内建函数，`permlanex16` 只用于非 GFX9。HCU 三个架构都是 GFX9，因此走的一直是 `ds_bpermute` 分支，无需任何回退开发。

gfx938 上已实测 `__GFX9__` 已定义、`ds_bpermute` 的 `lane ^ 16` 交换正确（lane0→16 / lane16→0 / lane63→47）。非 GFX9 分支原样保留，便于与上游对比。

## 4. 接口与参数

```python
import aiter

aiter.rotate_activation(out, input)

aiter.rope_rotate_activation(
    out, input, cos, sin, positions, rope_dim,
    out_scale=None, group_size=None, do_rotate_act=True,
)
```

| 参数 | 类型 / 形状 | 含义与约束 |
|---|---|---|
| `input` | `[..., head_num, dim]`，FP16 / BF16 | `dim ∈ {128,256,512,1024}`；`head_num` 为 2 的幂 |
| `out` | 同 `input` 形状 | FP16/BF16（同 `input` dtype），或 FP8（gfx938/946） |
| `cos` / `sin` | `[max_pos, rope_dim/2]`，与 `input` 同 dtype | 最后一维连续 |
| `positions` | `[num_tokens]`，int64 | 每 token 一个位置 |
| `rope_dim` | `int` | 偶数，`<= dim`，且能被 `vec_size` 整除（`dim<=512` 时 16，`dim==1024` 时 32） |
| `out_scale` | `[m, dim/group_size]`，FP32 | 仅 FP8 输出时必需 |
| `group_size` | `int`，默认 `128`（FP8） | 2 的幂，`dim % group_size == 0` |
| `do_rotate_act` | `bool`，默认 `True` | 为 `False` 时只做 RoPE，不做 Hadamard |
| 返回值 | `None` | 结果写入 out 张量 |

三个入口都是 `@compile_ops(..., develop=True)`，参数经 `aiter_tensor_t` 编组后进 native。入口的参数检查都在 `aiter_detail::AiterThrowGuard` 作用域内，失败时抛可捕获的 Python 异常而不是 `abort()`。

> 上游 `rope_rotate_activation` 还接受 `shuffle_scale` 与 `round_rope`：两者只服务 fp4 路径（前者选 dsv4 预洗牌 scale 布局，后者把 RoPE 结果先舍入回输入 dtype 再量化），本仓库没有这条路径，因此两个参数也不提供。

## 5. 使用方式

```python
import torch
import aiter
from aiter import dtypes

device = torch.device("cuda:0")
M, head_num, dim, rope_dim = 2048, 16, 128, 64
max_pos = 2048

x = torch.randn(M, head_num, dim, device=device, dtype=torch.bfloat16)
positions = torch.randint(0, max_pos, (M,), dtype=torch.int64, device=device)
freqs = torch.randn(max_pos, rope_dim // 2, device=device, dtype=torch.float32)
cos, sin = torch.cos(freqs).to(torch.bfloat16), torch.sin(freqs).to(torch.bfloat16)

# RoPE + Hadamard，bf16 原 dtype 输出
out = torch.empty_like(x)
aiter.rope_rotate_activation(out, x, cos, sin, positions, rope_dim)

# 仅 Hadamard
aiter.rotate_activation(out, x)

# RoPE + Hadamard + 1x128 FP8（gfx938 / gfx946）
q = torch.empty_like(x, dtype=dtypes.fp8)
qs = torch.empty(M * head_num, dim // 128, device=device, dtype=dtypes.fp32)
aiter.rope_rotate_activation(
    q, x, cos, sin, positions, rope_dim, out_scale=qs, group_size=128
)
```

### 功能验证入口

```bash
# 默认：bf16 × head_num=16 × dim ∈ {128,256,512} × M ∈ {1,16,128,2048}
python -B op_tests/test_dsv4_rotate_quant.py --mode 1   # rotate_activation
python -B op_tests/test_dsv4_rotate_quant.py --mode 2   # rope + hadamard
python -B op_tests/test_dsv4_rotate_quant.py --mode 3   # rope only
python -B op_tests/test_dsv4_rotate_quant.py --mode 4   # rope + hadamard + fp8

# 指定规模
python -B op_tests/test_dsv4_rotate_quant.py --mode 2 -m 128 -n 512 -hn 16 -d fp16
```

[test_dsv4_rotate_quant.py](../op_tests/test_dsv4_rotate_quant.py) 自带纯 torch 参考实现（WHT 用逐级 `torch.stack`，RoPE 用复数乘），不依赖 AITER 的其他 kernel 做参照。mode 4 在 gfx936 上自动跳过并打印原因。

BF16 输出的比对用相对容差 `rtol=1e-2, atol=1e-2`，不是位相等：本模块沿用上游的 BF16 舍入模式（截断），单元素相对误差可达 2^-8。

## 6. 实现与架构范围

通用 HIP C++（[dsv4_rotate_quant.cu](../csrc/kernels/dsv4_rotate_quant.cu)），基于 opus 的向量类型与访存抽象。各架构走同一份 kernel，`block_size` 恒为 64（一个 wave），每 block 处理 `vec_size * 64 / dim` 行：

| `dim` | `vec_size` | 每 block 行数 | 线程内蝶形级数 | 跨线程蝶形级数 |
|---:|---:|---:|---:|---:|
| 128 | 16 | 8 | 4 | 3 |
| 256 | 16 | 4 | 4 | 4 |
| 512 | 16 | 2 | 4 | 5 |
| 1024 | 32 | 2 | 5 | 5 |

跨线程级用 `swap_thread_data<span>`：`span <= 16` 用 DPP（`mov_dpp` / `upd_dpp`），`span ∈ {32, 64}` 用 `ds_bpermute`（见第 3 节）。分组 amax 走 `multithread_reduce`，无 LDS。

### 两处 HCU 相关实现要点

**opus 标量到 float 的转换必须用 `opus::cast`。** [opus.hpp](../csrc/include/opus/opus.hpp) 按编译器版本定义 `bf16_t`：clang ≥ 20 是真浮点 `__bf16`，clang < 20 是 `unsigned short`（整数）。本 kernel 的 `DTYPE_I` 来自 `hip2opus<scalar_t>`，上游在 RoPE 段里对 `input`、`cos`、`sin` 都用了 `static_cast<float>`，在 DTK 26.04（clang 18）上这是**整数转换**，会静默产出量级完全错误的结果；DTK 26.10（clang 22）上看不出问题。本实现一律改用 `opus::cast<float>`。

> 这是跨 DTK 版本的通用陷阱：把作用于 opus 标量的 `static_cast<float>` 当作需要修正的写法。对 torch 的 `scalar_t`（`c10::BFloat16`，有合规 `operator float()`）用 `static_cast<float>` 是安全的 —— 判定标准是这个值的来源，不是它看起来像不像浮点。

**`AITER_CHECK` 默认终止进程。** 本仓库的 `g_aiter_can_throw` 默认为 false，检查失败直接 `abort()`。三个入口都在函数开头放 `aiter_detail::AiterThrowGuard`，把该作用域内的检查改为抛异常。该 guard 本次从上游一并补入 [aiter_hip_common.h](../csrc/include/aiter_hip_common.h)。

native 入口编入 `module_dsv4_rotate_quant`，首次调用时 JIT 编译。

## 7. 性能报告

测试日期 2026-11-09。本仓库**没有对标实现**（Hadamard 旋转此前无 HCU 实现），因此按规划不做对比，只记录基线并确认无明显瓶颈异常。

### 测试环境与计时口径

| 项目 | gfx936 | gfx938 |
|---|---|---|
| 产品型号 | BW1000 64G | BW1100 |
| 计算单元（CU）数 | 80 | 64 |
| PyTorch | 2.11.0 | 2.11.0 |
| AITER 编译 | JIT，DTK 26.04（clang 18） | JIT，DTK 26.10（clang 22） |
| 输入 | BF16，`randn`，`head_num = 16` | 同左 |

- 计时由 `op_tests/test_dsv4_rotate_quant.py` 的 `perftest` 采集，取 device 侧 kernel 耗时。
- 数据在整卡空闲时采集。JIT 编译与预热不计入样本。

### 结果（µs，BF16，`head_num = 16`，`rope_dim = 64`）

| 入口 | `dim` | M=1 | M=16 | M=128 | M=2048 |
|---|---:|---:|---:|---:|---:|
| **gfx938** | | | | | |
| `rotate_activation` | 128 | 3.90 | 10.10 | 16.03 | 72.85 |
| | 256 | 4.64 | 16.08 | 18.65 | 150.61 |
| | 512 | 6.74 | 17.09 | 34.88 | 400.93 |
| `rope_rotate_activation` | 128 | 4.93 | 11.26 | 17.13 | 104.91 |
| | 256 | 5.48 | 17.16 | 22.57 | 207.75 |
| | 512 | 7.16 | 17.62 | 37.94 | 464.70 |
| `rope_rotate_activation`<br>（`do_rotate_act=False`） | 128 | 4.14 | 10.66 | 16.10 | 80.87 |
| | 256 | 4.53 | 15.87 | 18.21 | 150.32 |
| | 512 | 5.79 | 15.98 | 26.56 | 294.12 |
| `..._fp8quant` | 128 | 6.16 | 11.87 | 17.50 | 123.92 |
| | 256 | 6.26 | 17.54 | 25.04 | 247.29 |
| | 512 | 7.73 | 18.03 | 42.83 | 540.88 |
| **gfx936** | | | | | |
| `rotate_activation` | 128 | 3.55 | 7.26 | 12.53 | 54.50 |
| | 256 | 3.78 | 10.70 | 14.24 | 108.03 |
| | 512 | 4.95 | 12.61 | 24.27 | 247.29 |
| `rope_rotate_activation` | 128 | 4.65 | 8.10 | 12.94 | 77.82 |
| | 256 | 5.19 | 11.67 | 17.83 | 153.84 |
| | 512 | 6.12 | 13.32 | 29.26 | 337.85 |
| `rope_rotate_activation`<br>（`do_rotate_act=False`） | 128 | 4.13 | 7.34 | 12.57 | 64.76 |
| | 256 | 4.27 | 11.17 | 14.92 | 119.16 |
| | 512 | 5.26 | 12.12 | 21.63 | 225.92 |
| `..._fp8quant` | — | n/a | n/a | n/a | n/a |

### 结果分析

- **成本由跨线程蝶形主导，不是带宽。** 以 gfx938 `M=2048` 为例，数据量随 `dim` 按 1:2:4 增长，而耗时按 1:2.07:5.50 增长。跨线程蝶形级数是 3/4/5，每级做 `vec_size=16` 次 lane 交换，即每元素 3/4/5 次；按「数据量 × 每元素交换次数」预测的 1:2.67:6.67 与实测的超线性趋势一致。gfx936（80 CU）在同 shape 上快 18%~38%，也符合这是一个 ALU/交换受限而非访存受限的算子。
- **`do_rotate_act` 的开关给出了分解**：`M=2048, dim=512, gfx938` 上「仅 RoPE」294.12 µs、「RoPE + Hadamard」464.70 µs，Hadamard 本身约 170 µs，占总时长 37%。
- **有效带宽偏低是预期的**：`M=2048, head_num=16, dim=512` 读写共 67.1 MB，gfx938 用 464.70 µs，折合 144 GB/s。该 shape 下 `m = 32768` 行、每 block 2 行，即 16384 个 64 线程（单 wave）的 block —— 这是上游的设计（`block_size = WARP_SIZE`），block 粒度很细。**这是后续调优的候选方向**（增大 block_size 以摊薄每 block 开销），本次未做改动，以保持与上游一致、先建立可信基线。
- **FP8 量化的增量成本约 16%**（`M=2048, dim=512`：464.70 → 540.88 µs），包含分组 amax 归约、scale 写出与打包 FP8 转换。
- **小 M 区间（M ≤ 128）两架构都落在 4~43 µs**，受 kernel 启动与冷 cache 支配，不反映稳态吞吐。
- **适用范围**：结论限定于上列设备、软件版本、BF16 输入与所列 shape；未测 FP16 的性能矩阵（正确性已覆盖），未测 `dim = 1024`，未测端到端吞吐。

## 8. 验证记录

| 架构 | 正确性 | 备注 |
|---|---|---|
| gfx938 | **48 / 48 PASS** | mode 1~4 × 12 shape（`dim ∈ {128,256,512}` × `M ∈ {1,16,128,2048}`） |
| gfx936 | **36 / 36 PASS** | mode 1~3 × 12 shape；mode 4 按设计跳过（无 FP8 硬件） |
| gfx946 | 见下表 | 缩减规模（`-m 1 16 -n 128`），只验功能与多 die |

G6（低精度裁剪确认）逐项核对（核对脚本是临时产物，未入库）：

| 检查项 | gfx936 | gfx938 |
|---|---|---|
| `rope_rotate_activation_fp8quant` 是否导出 | 否 | 是 |
| `.so` 内 fp8 kernel 符号数 | 0 | 32 |
| 任何 fp4 入口 | 不存在 | 不存在 |

gfx936 的 BF16 结果正确是关键确认点：该架构 clang 18 下 `bf16_t` 是整数类型，第 6 节的 `opus::cast` 修正正是为此。

## 9. 版本与数据追溯

| 项目 | 标识 |
|---|---|
| 源码基线 | commit `c7e01755`（L1 合入后的 main） |
| 上游参考 | `csrc/kernels/dsv4_rotate_quant.cu`（1544 行，移植后约 600 行） |
| 功能验证 | 2026-11-09，gfx938 48/48、gfx936 36/36 PASS |
| 性能数据采集 | 2026-11-09，BW1000 64G / gfx936 与 BW1100 / gfx938，均为空闲整卡 |

- [Python 接口](../aiter/ops/quant.py)
- [native kernel 实现](../csrc/kernels/dsv4_rotate_quant.cu)
- [native 入口声明](../csrc/include/dsv4_rotate_quant.h)、[pybind 模块](../csrc/pybind/dsv4_rotate_quant_pybind.cu)
- [amax 下界](../csrc/include/quant_amax_floor.h)
- [功能测试](../op_tests/test_dsv4_rotate_quant.py)
- [JIT 编译配置](../aiter/jit/optCompilerConfig.json)
