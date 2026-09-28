<!--
SPDX-License-Identifier: MIT
Copyright (c) 2026 Hygon Information Technology Co., Ltd.
-->

# silu_mul_quant 算子说明与性能报告

本接口族在同一个 CUDA / HIP kernel 内完成 `silu_and_mul` 激活与逐 token 动态量化，覆盖 2D `[..., 2*d]` 与 3D EP `[E, T, 2*d]` 两种排布、int8 与 fp8（e4m3 / e5m2）两种输出类型，并额外提供纯激活的 masked EP 变体 `fuse_silu_and_mul_ep` 与 squared-ReLU 的 `relu2`。

本报告在 BW1100（gfx938）实卡上给出该接口族的性能数据，测试日期为 **2026-09-23**，共 24 个 shape 配置（2D 15 个、3D EP 9 个），每个配置分别测量 int8、fp8 e4m3、fp8 e5m2 三种量化输出。报告只给出融合算子自身的绝对时延与有效带宽，**不含对照实现对比**；完整数据和适用范围见下文。

## 算子功能

记 `N` 为 token 数、`d` 为每 token 的隐层半宽（输入最后一维为 `2*d`）、`E` 为专家数、`T` 为每专家最大 token 数、`topk` 为每 token 的路由分片数。输入沿最后一维前一半为 `x`、后一半为 `y`，融合计算为：

```text
act[n, i]    = silu(x[n, i]) * y[n, i]                        # i ∈ [0, d)
row_max[n]   = max_i |act[n, i]|
scale[n]     = row_max[n] / QMAX                              # QMAX = 127 (int8)
                                                              # QMAX = 448  (fp8_e4m3)
                                                              # QMAX = 57344(fp8_e5m2)
scale[n]     = max(scale[n], 1 / (QMAX * 512))                # 仅 fp8 分支的下限
q[n, i]      = round(act[n, i] / scale[n])                    # int8: 四舍五入到偶
                                                              # fp8:  round-to-nearest-even + 饱和
```

其中 `silu(x) = x * sigmoid(x)`，实现使用 `__builtin_amdgcn_exp2f` 以 log2 展开近似 `exp`。2D 输出形状 `[..., d]`、scales 形状 `[..., 1]`；3D EP 输出形状 `[E, T, d]`、scales 形状 `[E, T, 1]`。`scale` 一律为 FP32；int8 输出为 `torch.int8`，fp8 输出为 `torch.float8_e4m3fn` 或 `torch.float8_e5m2`。

被 mask 掉的槽位（`num_local_tokens_tensor`、`expert_ids == -1` 或 `tokens_per_expert` 之外的行）不会写入 `out` 与 `scales`，调用方需要保证这些槽位在读侧被过滤或初始化为期望默认值。全零输入下 int8 分支的 `inv_scale` 直接置零，输出对应槽位为 0；fp8 分支通过 `1/(QMAX*512)` 下限保证 `scale` 不为零。

**输入张量最后一维必须为 `2*d` 且 `d>=1`；`out`、`input`、`scales` 都必须 `contiguous`。** fp8 输出内部按 `uint8` 传入 kernel，`out.data_ptr()` 的实际 dtype 由包装函数决定，直接读取 `q.view(torch.uint8)` 与 `q.view(torch.float8_e4m3fn)` 得到的数值不同。本接口只做激活 + 量化，不做 gating、topk 排序、all2all、mask 生成等外围步骤。

## 接口与参数

以下六个入口共同暴露在 `aiter.ops.activation` 命名空间下，并从顶层 `aiter` 直接导入：

```python
from aiter import (
    fuse_silu_mul_quant,        # 2D int8
    fuse_silu_mul_fp8_quant,    # 2D fp8
    fuse_silu_mul_quant_ep,     # 3D EP int8
    fuse_silu_mul_fp8_quant_ep, # 3D EP fp8
    fuse_silu_mul_per_token_quant,  # 2D 泛型入口
    fuse_silu_and_mul_ep,       # 3D EP 纯激活
    relu2,                      # relu(x)^2
)
```

### fuse_silu_mul_quant / fuse_silu_mul_fp8_quant （2D）

```python
q, scales = fuse_silu_mul_quant(
    input,
    num_local_tokens_tensor=None,
    topk=1,
    expect_m=-1,
    output=None,
    scales=None,
    expert_ids=None,
)

q, scales = fuse_silu_mul_fp8_quant(
    input,
    fp8type=0,          # 0: e4m3, 1: e5m2
    num_local_tokens_tensor=None,
    topk=1,
    expect_m=-1,
    output=None,
    scales=None,
    expert_ids=None,
)
```

| 参数 | 类型 / 形状 | 含义与约束 |
| --- | --- | --- |
| `input` | `float / float16 / bfloat16` Tensor `[..., 2*d]` | 拼接后的 `[x, y]`；连续，最后一维为偶数 |
| `num_local_tokens_tensor` | 可选 `int32` Tensor `[1]` | 单标量的有效 token 数上限，实际参与量化的行数为 `min(N, num_local_tokens[0]*topk)`；仅生效在 `expert_ids is None` 时 |
| `topk` | Python `int`，默认 `1` | 与 `num_local_tokens_tensor` 组合使用，扩张有效行数 |
| `expect_m` | Python `int`，默认 `-1` | 每专家期望 token 上限；`!=-1` 时用于收缩 grid，只影响启动配置，不改变有效行数计算 |
| `output` | 可选 Tensor `[..., d]` | int8 版为 `torch.int8`，fp8 版为 `torch.float8_e4m3fn` 或 `torch.float8_e5m2`；`None` 时由包装函数按 `input` 前 leading dim 与 `d` 自动分配 |
| `scales` | 可选 `float32` Tensor `[..., 1]` | 每 token 一个 scale；`None` 时自动分配 |
| `expert_ids` | 可选 `int32` Tensor `[..., 1] / [...]` | 逐行的专家编号，`-1` 表示 padding，被跳过；提供该参数时 `num_local_tokens_tensor` 被忽略 |
| `fp8type` | Python `int`，仅 fp8 版；`0=e4m3, 1=e5m2` | 决定输出 dtype 与量化上限 |
| 返回值 | `(q, scales)` | `q` 按 dtype 分类见 `output` 行；`scales` 每 token 的 fp32 缩放因子 |

`num_local_tokens_tensor`、`expert_ids` 与 `tokens_per_expert` 三种 mask 相互独立：前两者用于 2D 排布，最后一个用于 3D EP。当 `expert_ids` 提供时，无效行不会写入 `output` 与 `scales`，调用方需自行清零或使用哨兵值。

`fuse_silu_mul_per_token_quant` 是根据 `dtype` 或 `output.dtype` 自动分派到 int8 / fp8_e4m3 / fp8_e5m2 的通用入口，签名与 `fuse_silu_mul_quant` 完全一致，仅多出 `dtype=torch.int8` 一项。

### fuse_silu_mul_quant_ep / fuse_silu_mul_fp8_quant_ep （3D EP）

```python
q, scales = fuse_silu_mul_quant_ep(
    input,                     # [E, T, 2*d]
    tokens_per_expert=None,    # int32 [E]
    num_local_tokens_tensor=None,  # 未使用，仅保持签名对齐
    topk=1,                    # 未使用
    expect_m=-1,               # 未使用
)

q, scales = fuse_silu_mul_fp8_quant_ep(
    input,
    fp8type=0,
    tokens_per_expert=None,
    num_local_tokens_tensor=None,
    topk=1,
    expect_m=-1,
)
```

| 参数 | 类型 / 形状 | 含义与约束 |
| --- | --- | --- |
| `input` | `float / float16 / bfloat16` Tensor `[E, T, 2*d]` | 必须 3D 且连续 |
| `tokens_per_expert` | 可选 `int32` Tensor `[E]` | 第 e 个专家实际有效的 token 数；超过的槽位跳过写入 |
| `fp8type` | Python `int`，仅 fp8 版；`0=e4m3, 1=e5m2` | 同 2D 版 |
| 返回值 `q` | `[E, T, d]`，int8 / fp8_e4m3 / fp8_e5m2 | 新分配 |
| 返回值 `scales` | `[E, T, 1]`，float32 | 新分配 |

3D EP 版本以「token-major flat grid」形式启动：`grid.x = E * T`，一个 block 负责一个逻辑 token；`tokens_per_expert[e]` 之外的槽位由 block 前置判断直接返回，不再走激活和量化路径。`num_local_tokens_tensor`、`topk`、`expect_m` 仅为与 2D 签名对齐而保留，当前 kernel 并未消费。

### fuse_silu_and_mul_ep （3D EP，无量化）

```python
fuse_silu_and_mul_ep(
    input,          # [E, T, 2*d]，原地写入 output
    output,         # [E, T, d]，与 input 同 dtype
    mask_m,         # int32 [E]，每专家有效 token 数
    expect_m=-1,    # 用于收缩 grid.y 的启动配置提示
)
```

| 参数 | 类型 / 形状 | 含义与约束 |
| --- | --- | --- |
| `input` | `float / float16 / bfloat16` Tensor `[E, T, 2*d]` | 连续；与 `output` 同 dtype |
| `output` | 同 dtype Tensor `[E, T, d]` | 由调用方分配；被 mask 的槽位保持原值不变 |
| `mask_m` | `int32` Tensor `[E]` | 第 e 个专家有效 token 数，`0` 表示整专家跳过 |
| `expect_m` | Python `int`，默认 `-1` | `>0` 时限制 `grid.y = min(T, expect_m)`，不影响正确性；仅用于降低对小负载的启动开销 |

该接口不做量化，输出 dtype 等于 `input` dtype，无 `scales` 输出；被 mask 的槽位（`t >= mask_m[e]`）跳过写入。当 `E*T*d` 为 0 时直接返回。

### relu2

```python
out = relu2(input)   # 与 input 同形状、同 dtype
```

| 参数 | 类型 / 形状 | 含义与约束 |
| --- | --- | --- |
| `input` | `float / float16 / bfloat16` Tensor `[..., d]` | 任意 leading 维；`d` 不受 2 的倍数限制 |
| 返回值 | Tensor `[..., d]` | 新分配；`out = max(x, 0)^2` |

### 通用约束

所有输入须在同一 GPU；`input`、`out`、`scales`、`tokens_per_expert`、`mask_m`、`expert_ids`、`num_local_tokens_tensor` 均需 `contiguous`。当 `input.data_ptr()` 与 `out.data_ptr()` 的对齐无法满足某一向量化 bucket 的字节对齐要求时（例如 `d<=4096` 期望 16B 对齐但基址只有 8B 对齐），dispatch 会自动降级到更窄的向量宽度或最终 `_generic` fallback；调用方无需手工处理对齐。int8 与 fp8 分支要求 `d` 为 dispatch 桶对应向量宽度的整数倍（详见"实现与架构范围"），否则自动落到 `_generic` fallback。

调用方保证 `num_local_tokens_tensor` 的元素为非负、`tokens_per_expert[e] <= T`、`expert_ids[t] ∈ {-1} ∪ [0, E)`；接口只做元数据 / dtype 校验，不在热路径把这些张量拷回 CPU 做完整检查。

本接口用于推理，不提供反向计算 / autograd。除 `fuse_silu_and_mul_ep` 与 `relu2` 之外，公开函数会在 `output`、`scales` 未传入时自动分配输出；已传入的 `output` / `scales` 只能是 `torch.empty` / `torch.full` 之类的可写张量，接口不会读取其初值（`expert_ids` 掩码语义除外，此时未写入的槽位保留调用方设置的初值）。

### mask 三合一语义

| 场景 | 使用的 mask 参数 | 有效行判定 | 无效槽位行为 |
| --- | --- | --- | --- |
| 2D、静态 batch | 均为 `None` | 全部 `N` 行 | 无 |
| 2D、动态 batch (num tokens on device) | `num_local_tokens_tensor=[nt]`, `topk` | 前 `min(N, nt*topk)` 行 | 不写入，尾部保留初值 |
| 2D、MoE routing 掩码 | `expert_ids`（内含 `-1`） | `expert_ids[t] != -1` 行 | 不写入，保留调用方初值 |
| 3D EP、每专家不定长 | `tokens_per_expert` | 每专家前 `tokens_per_expert[e]` 行 | 不写入，保留调用方初值 |
| 3D EP、纯激活 | `mask_m` (`fuse_silu_and_mul_ep`) | 每专家前 `mask_m[e]` 行 | 不写入，保留调用方初值 |

同一次 2D 调用不建议同时提供 `expert_ids` 与 `num_local_tokens_tensor`；当两者都非 `None` 时，`expert_ids` 优先，`num_local_tokens_tensor` 与 `grid_stride` 分支被忽略。

### 架构与 kernelId 支持

| 架构 | 支持范围 | `kernelId` | fp8 转换路径 |
| --- | --- | --- | --- |
| gfx938 | int8 / fp8_e4m3 / fp8_e5m2；2D + 3D EP + 纯激活 EP + relu2 | 无参数暴露 | 优先使用 `__builtin_hcu_cvt_pk_{fp8,bf8}_f32`，每指令打包 2 个 float→fp8，`VEC%4==0` bucket 一次写 4 字节 |
| gfx936 | 同上 | 无参数暴露 | 无硬件 pack builtin，回落到软件 `float_to_fp8e4m3` / `float_to_fp8e5m2`（RNE + 饱和），逐字节写出 |
| gfx946 及以下 | 通过 dispatch fallback 保持功能 | 无参数暴露 | 走 gfx936 的软件路径；实卡未做性能验证 |

- **公开接口不暴露 `kernelId`**：向量宽度与 block size 完全由 `d`、`num_tokens`、基址对齐与 dtype 自动选择。
- **fp8 打包指令**仅在 `__gfx938__` 编译宏下生效，选择 `VEC%4==0` 的 bucket（`d<=512` 时 `VEC=4/BLOCK=128`；其余 bucket 均为 `VEC∈{8,16,32}`）。

## 使用方式

### 2D int8 单一 batch

```python
import torch
import aiter

device = "cuda:0"  # HCU / ROCm 也使用 PyTorch 的 cuda 设备名
N, d = 128, 2048
x = torch.randn(N, 2 * d, dtype=torch.bfloat16, device=device)

with torch.inference_mode():
    q, scales = aiter.fuse_silu_mul_quant(x)

assert q.shape == (N, d) and q.dtype == torch.int8
assert scales.shape == (N, 1) and scales.dtype == torch.float32
# assert 仅用于展示形状 / dtype，不属于热路径
```

### 2D fp8 且带动态 batch 上限

```python
import torch
import aiter

device = "cuda:0"
N, d = 4096, 2048
x = torch.randn(N, 2 * d, dtype=torch.float16, device=device)
# 设备侧记录的真实 token 数（无 topk 复制时置 topk=1）。
nt = torch.tensor([2500], dtype=torch.int32, device=device)

with torch.inference_mode():
    q, scales = aiter.fuse_silu_mul_fp8_quant(
        x, fp8type=0, num_local_tokens_tensor=nt, topk=1,
    )
assert q.dtype == torch.float8_e4m3fn
# 前 2500 行有效，后续行未被写入；如果调用方后续会读取尾部，需要在调用前清零。
```

`nt` 只在 GPU 上读取，不会在 host 端解引用；`num_tokens < 8192` 且 `expect_m == -1` 时使用「一 block 一 token」的直接映射，`num_tokens >= 8192` 时使用 grid-stride 收缩后的启动配置。示例中的 `int(...)` 或 `.item()` 只应在校验或调试路径中使用，不属于热路径计时。

### 3D EP int8 / fp8

```python
import torch
import aiter

device = "cuda:0"
E, T, d = 8, 128, 2048
x = torch.randn(E, T, 2 * d, dtype=torch.bfloat16, device=device)
tpe = torch.tensor([128, 96, 64, 32, 128, 0, 128, 128],
                   dtype=torch.int32, device=device)

with torch.inference_mode():
    q_i8, s_i8 = aiter.fuse_silu_mul_quant_ep(x, tpe)
    q_e4, s_e4 = aiter.fuse_silu_mul_fp8_quant_ep(x, fp8type=0, tokens_per_expert=tpe)

assert q_i8.shape == (E, T, d) and q_i8.dtype == torch.int8
assert q_e4.dtype == torch.float8_e4m3fn
# tpe[e]=0 表示整专家跳过写入；下游必须先对齐 mask 才能安全消费。
```

### 3D EP 纯激活（无量化）

```python
import torch
import aiter

device = "cuda:0"
E, T, H = 8, 128, 4096
x = torch.randn(E, T, 2 * H, dtype=torch.bfloat16, device=device)
out = torch.empty(E, T, H, dtype=torch.bfloat16, device=device)
mask = torch.tensor([128, 96, 64, 32, 128, 0, 128, 128],
                    dtype=torch.int32, device=device)

with torch.inference_mode():
    aiter.fuse_silu_and_mul_ep(x, out, mask, expect_m=128)
```

`expect_m` 只影响 `grid.y = min(T, expect_m)` 的启动配置，不改变正确性；当典型有效长度已知时可以显式收缩以降低小负载启动开销。

### relu2

```python
import torch
import aiter

device = "cuda:0"
N = 8
for d in (168, 336, 672, 4096):
    x = torch.randn(N, d, dtype=torch.bfloat16, device=device)
    with torch.inference_mode():
        y = aiter.relu2(x)
    assert y.shape == x.shape and y.dtype == x.dtype
```

`d ∈ {168, 336, 672}` 会走多行一 block 的 `relu2_kernel_multirow` 分支（要求 `num_tokens` 满足对应倍数条件），其余 `d` 走标准分桶或 `_generic` fallback。

### Graph 捕获

```python
import torch
import aiter

device = "cuda:0"
N, d = 512, 2048
x = torch.randn(N, 2 * d, dtype=torch.bfloat16, device=device)
q = torch.empty(N, d, dtype=torch.int8, device=device)
s = torch.empty(N, 1, dtype=torch.float32, device=device)

def run():
    aiter.fuse_silu_mul_quant(x, output=q, scales=s)

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
```

Graph 输入 / 输出 shape 与地址保持不变，更新值时原地 `copy_`，并保持输入和捕获输出存活。replay 写回同一 `q`、`s`，输出消费需遵守 stream 依赖；首次 JIT 与预热应在捕获和计时之外完成。若需要在 Graph 内使用 `num_local_tokens_tensor` 或 `expert_ids`，将它们也作为固定地址的常驻张量，用 `copy_` 更新数值。

## 实现与架构范围

gfx938 / gfx936 上，2D 与 3D EP 版本共享一组模板化的向量化 kernel，公共骨架为「一 block 一 token」的两阶段流程：先向量化读入 `x`、`y` 并直接算出激活值 `r_y`，配合 `block_reduce_max` 得到 `row_max`；由 0 号线程写出 `scale` 后广播到 shared，再向量化写出量化结果。int8 分支通过 `float_to_int8_rn`（`nearbyint` + 饱和）逐 lane 转换；fp8 分支在 gfx938 上使用 `__builtin_hcu_cvt_pk_{fp8,bf8}_f32` 每指令打包 2 个 float→fp8、`VEC%4==0` 时按 `uint32_t` 一次写 4 字节，在 gfx936 等无硬件 pack 指令的架构上回落到软件 RNE + 饱和逐字节转换。

dispatch 按 `d` 的上界与 `d % VEC == 0` 及基址对齐分桶（详见 `csrc/kernels/silu_mul_quant_kernels.cu:797`）：

| `d` 上界 | int8 桶 | fp8 桶 | 备注 |
| ---: | --- | --- | --- |
| 512 | `VEC=2, BLOCK=256` | `VEC=4, BLOCK=128` | fp8 走硬件 pack 指令的最窄 bucket |
| 1024 | `VEC=8, BLOCK=128` | 同 | |
| 2048 | `VEC=16, BLOCK=128` (需 `num_tokens>=512`) 否则 `VEC=8, BLOCK=256` | 同 | 宽 vector 桶仅对高并发 batch 生效 |
| 4096 | `VEC=16, BLOCK=256` / `VEC=8, BLOCK=512` | 同 | |
| 8192 | `VEC=16, BLOCK=512` / `VEC=8, BLOCK=1024` | 同 | |
| 16384 | `VEC=16, BLOCK=1024` | 同 | |
| 32768 | `VEC=32, BLOCK=1024` | 同 | |
| `>32768` 或未对齐 | `_generic` fallback，`BLOCK=1024`，per-thread strided loop | 同 | |

2D 版本的 grid 通过 `fused_quant_grid` 收缩：当 `num_local_tokens_tensor` 提供且 `num_tokens>=8192` 时启用 grid-stride，`grid=num_tokens/4`（`>=16384` 时 `num_tokens/8`），每 block 以 `blockIdx.x + gridDim.x` 迭代多个 token 并在 `expert_ids` 路径下改为 early break；`num_tokens<8192` 或 `expect_m != -1` 保留一 block 一 token 的启动配置。3D EP 版本一律使用 flat grid = `E*T` 的一 block 一 token 布局，不再采用旧版 `(E, 128)` + `gridDim.y` 迭代（避免 `T<128` 时的重复计算与每迭代前的 `tokens_per_expert` 二次加载）。

`fuse_silu_and_mul_ep` 使用 `(E, grid_y)` 的二维 grid，`grid_y = min(T, max(1, expect_m))`；每 block 沿 `y` 轴迭代直到 `mask_m[e]`。`d<=8192 且 d%8==0` 走 `VEC=8` 分桶，`d<=512 且 d%2==0` 走 `VEC=2`，其余走 `VEC=1` fallback。

`relu2` 针对 `d ∈ {168, 336, 672}` 提供三条 `relu2_kernel_multirow` 特化路径（分别对应 21/42/84 × 每 block 8/8/4 行、`VEC=8`，`__launch_bounds__(1024, 1)`）以摊薄 launch 开销；其余 `d%8==0` 且 `d<=4096` 的输入走 `relu2_kernel_vec`（`VEC=8`），不满足则回落到 `relu2_kernel` 的 per-thread strided loop。

gfx946 等更早的架构使用同一组 host dispatcher，无硬件 pack 指令时 fp8 走软件转换路径，实卡未做性能验证。上述所有 kernel 均无 `kernelId` 参数暴露。

## 性能报告（BW1100 / gfx938）

### 测试环境与计时口径

| 项目 | gfx938 |
|---|---|
| 设备 / 产品型号 | GPU0，BW1100 |
| 计算单元（CU）数 | 64 |
| 可见显存 | 147440 MiB |
| 测试日期 | 2026-09-23 |
| 软件 | PyTorch 2.10.0，`torch.version.hip` 6.3.26113 |
| 编译 | AITER JIT：AICC clang 18.0.0（`/opt/dtk`），默认选项 |
| 输入 | BF16 输入，int8 / fp8（e4m3 / e5m2）输出，FP32 scales |
| 调用方式 | 公开 API，默认分配 `output` 与 `scales`；EP 传入全满 `tokens_per_expert` |
| 计时 | 同卡同进程；`run_perftest`（torch.profiler 汇总 GPU kernel device time） |

- 计时对象为 **公开 API 的 eager 调用**：`aiter.fuse_silu_mul_quant`、`fuse_silu_mul_fp8_quant`、`fuse_silu_mul_quant_ep`、`fuse_silu_mul_fp8_quant_ep`，输出与 scales 由包装函数默认分配；全部表格使用同一口径。
- 每个配置使用 `aiter.test_common.run_perftest` 的默认设置：2 次预热 + 101 次计时调用，报告值再独立重复 5 轮取**中位数**。首次 JIT 编译发生在预热之前，不计入样本。
- 报告的微秒数是 torch.profiler 汇总的 GPU kernel device time 折算的单次平均值（每次调用恰好 1 个 kernel），**不是 CPU 墙钟耗时**，也不含主机端分配与发射等待。
- `run_perftest` 默认将输入复制 101 份轮换使用，各次计时调用读取不同输入副本，无 L2 输入常驻收益；默认分配的输出走 PyTorch caching allocator 复用。
- 计时前逐配置做去量化正确性检查，通过后才计入样本；没有在 API 外预先替算子完成其内部必要的数据转换。
- CV 为 5 轮样本（每轮 101 次调用的平均值）的标准差 / 均值，下文报出每组最大保留 CV。
- 本报告不含对照实现对比：测试文件 `--perf` 中的 unfused（`silu_and_mul` + `per_token_quant_hip`）基线未纳入，因此本文没有加速比与快 / 平 / 慢判定。数据来自文档整理时的一次性采集脚本（未入库），按上列口径可复现。

### Shape 与输入构造

- 2D 共 **15 个配置**：`d ∈ {2048, 4096, 7168} × m ∈ {1, 64, 512, 4096, 8192}`，覆盖 dispatch 分桶表的主要向量桶，包括 `d=2048/4096` 在 `m>=512` 与 `m<512` 两侧的桶差异。
- 3D EP 共 **9 个配置**：`E=16`，`H=2d ∈ {4096, 7168, 8192} × T ∈ {64, 256, 1024}`；`tokens_per_expert` 全部等于 `T`，即**没有跳过行**，数据量与同 token 数的 2D 调用一致。
- shape 为合成的算子测试负载，不是线上请求回放；输入统一为 BF16（FP16 接口可用但未测性能），固定随机种子后由 `torch.randn` 生成，无人工注入的极端值。
- 以下场景未纳入性能矩阵：部分 mask（`num_local_tokens_tensor` / `expert_ids` / 不满的 `tokens_per_expert`，其时延与有效行占比相关）、非对齐基址的 `_generic` 回退、`fuse_silu_mul_per_token_quant` 通用入口（纯 Python 分派到上列四口）、`fuse_silu_and_mul_ep`、`relu2`、FP16 输入。

### 正确性与计时边界

| 检查项 | 验收结果 |
|---|---|
| 完整功能测试文件（2026-09-23，本卡） | 全部通过（`[Correctness] All tests passed`），覆盖 2D / EP、int8 / fp8 e4m3 / e5m2、三种 mask 语义、零 token、宿主检查与非对齐回退 |
| 性能矩阵 | 24 配置 × 3 种量化输出，计时前去量化检查全部通过；int8 最大归一化误差 0.0074，fp8 最大 0.075 |

去量化误差按行 amax 归一，与功能测试同一容差公式：int8 要求 `< 0.05`，fp8 要求 `< 0.2`。

### 性能指标定义

```text
时延 = 单次公开 API 调用的 GPU kernel device time（5 轮中位数，单位 µs，保留三位小数）
有效带宽 (TB/s) = 有效字节数 / 时延 / 1e6
有效字节数 = input（BF16，2 字节/元素）+ q（int8 / fp8，1 字节/元素）+ scales（FP32，4 字节/行）
```

有效字节数只计入本算子实际读写的张量；融合实现不产生中间激活的全局读写，无额外字节。文中 TB/s 为该公式的有效带宽，**未与硬件峰值带宽做比值**。本报告无对照实现，所有「更快 / 更慢」的表述均指本接口族不同量化输出之间或不同 shape 之间的横向比较。

### 2D 逐 shape 结果

| `d` | `m` | int8 (µs) | int8 (TB/s) | e4m3 (µs) | e4m3 (TB/s) | e5m2 (µs) | e5m2 (TB/s) |
|---:|---:|---:|---:|---:|---:|---:|---:|
| 2048 | 1 | 4.556 | 0.002 | 4.578 | 0.002 | 4.542 | 0.002 |
| 2048 | 64 | 4.639 | 0.141 | 4.639 | 0.141 | 4.639 | 0.141 |
| 2048 | 512 | 11.881 | 0.441 | 10.764 | 0.487 | 10.664 | 0.492 |
| 2048 | 4096 | 69.195 | 0.606 | 59.440 | 0.706 | 59.410 | 0.706 |
| 2048 | 8192 | 127.419 | 0.659 | 108.128 | 0.776 | 108.159 | 0.776 |
| 4096 | 1 | 5.497 | 0.004 | 5.335 | 0.004 | 5.316 | 0.004 |
| 4096 | 64 | 5.599 | 0.234 | 5.439 | 0.241 | 5.439 | 0.241 |
| 4096 | 512 | 19.869 | 0.528 | 17.679 | 0.593 | 17.679 | 0.593 |
| 4096 | 4096 | 123.153 | 0.681 | 103.709 | 0.809 | 103.805 | 0.808 |
| 4096 | 8192 | 236.509 | 0.710 | 197.564 | 0.849 | 197.658 | 0.849 |
| 7168 | 1 | 7.468 | 0.005 | 6.979 | 0.005 | 6.965 | 0.005 |
| 7168 | 64 | 7.519 | 0.305 | 7.095 | 0.323 | 7.066 | 0.325 |
| 7168 | 512 | 34.743 | 0.528 | 29.437 | 0.623 | 29.381 | 0.625 |
| 7168 | 4096 | 213.194 | 0.689 | 177.311 | 0.828 | 177.271 | 0.828 |
| 7168 | 8192 | 417.282 | 0.704 | 345.930 | 0.849 | 345.786 | 0.849 |

最大保留 CV：int8 **3.574%**、e4m3 **2.631%**（均在 `m=1、d=2048`），e5m2 **0.323%**（`m=1、d=2048`）；2D 中 `m>=512` 的全部配置 CV 均低于 0.5%。

### 3D EP 逐 shape 结果

| `E` | `T` | `H` | int8 (µs) | int8 (TB/s) | e4m3 (µs) | e4m3 (TB/s) | e5m2 (µs) | e5m2 (TB/s) |
|---:|---:|---:|---:|---:|---:|---:|---:|---:|
| 16 | 64 | 4096 | 20.423 | 0.514 | 18.223 | 0.576 | 18.168 | 0.577 |
| 16 | 256 | 4096 | 70.703 | 0.593 | 60.727 | 0.691 | 60.751 | 0.691 |
| 16 | 1024 | 4096 | 248.602 | 0.675 | 210.151 | 0.799 | 210.153 | 0.799 |
| 16 | 64 | 7168 | 36.879 | 0.498 | 31.905 | 0.575 | 31.837 | 0.576 |
| 16 | 256 | 7168 | 123.421 | 0.595 | 104.454 | 0.703 | 104.372 | 0.703 |
| 16 | 1024 | 7168 | 469.459 | 0.626 | 391.519 | 0.750 | 391.536 | 0.750 |
| 16 | 64 | 8192 | 37.109 | 0.565 | 32.669 | 0.642 | 32.637 | 0.643 |
| 16 | 256 | 8192 | 124.226 | 0.675 | 105.647 | 0.794 | 105.648 | 0.794 |
| 16 | 1024 | 8192 | 470.172 | 0.714 | 392.760 | 0.854 | 392.829 | 0.854 |

最大保留 CV：**0.757%**（`E=16、T=1024、H=8192` 的 e4m3 列）。

### 结果分析

- 时延随 token 数阶梯增长，带宽在 `m/T>=256` 后进入平台：2D `m=1` 时约 4.5–7.5 µs，为启动与调度开销下限，有效带宽仅 0.002–0.005 TB/s；`m=64` 约 0.14–0.33 TB/s；`m>=4096` 后 int8 约 0.59–0.71 TB/s、fp8 约 0.69–0.85 TB/s。全矩阵最高有效带宽为 **0.855 TB/s**（EP `E=16、T=1024、H=8192`、e4m3）。
- fp8 输出稳定快于 int8 输出：最大 2D shape（`m=8192、d=7168`）下 e4m3 时延为 int8 的 82.9%，小 shape（`m<=64`）两者基本重合。该差异与实现一致——gfx938 的 fp8 路径用硬件 pack 指令按 `uint32_t` 一次写出 4 字节，int8 逐 lane 取整饱和转换；带宽数据不能把这一差异归因到量化常数本身。e4m3 与 e5m2 全矩阵时延差不超过 0.94%，可视为同一路径。
- 3D EP flat grid 与 2D 直接映射吞吐一致：同 token 数对比（EP `E=16、T=1024、H=8192` 对两份 2D `m=8192、d=4096`）int8 与 e4m3 时延偏差均约 `-0.6%`，EP 封装未引入额外开销。
- **适用范围**：结果限定于所列设备（BW1100 / gfx938）、软件版本（PyTorch 2.10.0 + `torch.version.hip` 6.3.26113 + AICC clang 18.0.0）、BF16 输入分布与上列 shape，不能推广到其他架构、其他 dtype、mask 部分有效、非对齐输入或 `relu2` / `fuse_silu_and_mul_ep` / `fuse_silu_mul_per_token_quant`。本文为设备级 kernel 计时，不代表模型端到端加速；文中的绝对时延与带宽数据没有对照实现可供比较，不能解读为「融合相对不融合」的收益。

## 版本与数据追溯

| 项目 | 固定版本 / 标识 |
|---|---|
| AITER 实现提交 | `08b66ee4cd1403fb7160e659bba14193f779d58e` |
| 性能数据采集 | 2026-09-23，BW1100 / gfx938，单卡 GPU0 |

## 相关实现与测试入口

接口的功能与性能测试可从 AITER 仓库根目录运行：

```bash
# 完整正确性套件（2D / EP / mask 语义 / 零 token / 宿主检查）
HIP_VISIBLE_DEVICES=0 python op_tests/test_silu_mul_quant.py --correctness

# 文件自带的 perf 入口（含 fused vs unfused 对照，与本报告口径不同，不能混用其加速比）
HIP_VISIBLE_DEVICES=0 python op_tests/test_silu_mul_quant.py --perf
```

- Python 包装：[activation.py](../aiter/ops/activation.py)
- native 入口 / dispatcher：[silu_mul_quant_kernels.cu](../csrc/kernels/silu_mul_quant_kernels.cu)
- pybind 注册：[rocm_ops.hpp](../csrc/include/rocm_ops.hpp)
- 函数声明：[activation.h](../csrc/include/activation.h)
- 单文件测试 + 性能脚本：[test_silu_mul_quant.py](../op_tests/test_silu_mul_quant.py)
