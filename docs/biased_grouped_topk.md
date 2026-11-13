<!--
SPDX-License-Identifier: MIT
Copyright (c) 2026 Hygon Information Technology Co., Ltd.
-->

# biased_grouped_topk

本文说明海光 AITER 当前工作树的接口和倍率行为：`biased_grouped_topk` 已将形参 `routed_scaling_factor` 传给 `biased_grouped_topk_hip`，专用 HIP 内核也已补齐关闭归一化时的倍率乘法。核对日期为 2026-10-20，基于提交 `c4b8624d9a1b75c9d0ee7beef544c7ab77f2c7d5` 及这两项修改。下文前后组合关系由源码推导，实际浮点结果还受计算精度影响。

## 1. 接口说明

### 1.1 功能与签名

`aiter.biased_grouped_topk` 为每个 token 执行带专家选择偏置的分组 MoE 路由，将选中的专家 ID 和配对权重写入调用方提供的缓冲区。后续 `aiter_moe` 使用这些 ID 执行专家计算，并按权重聚合结果。

接口定义：[`aiter/ops/topk.py:75`](../aiter/ops/topk.py#L75)。

```python
def biased_grouped_topk(
    gating_output: torch.Tensor,
    correction_bias: torch.Tensor,
    topk_weights: torch.Tensor,
    topk_ids: torch.Tensor,
    num_expert_group: int,
    topk_group: int,
    num_fused_shared_experts: int,
    need_renorm: bool,
    routed_scaling_factor: float = 1.0,
): ...
```

记 token 数为 `T`、routed 专家总数为 `E`、输出槽数为 `K`、本次融合的共享专家数为 `S`。

| 参数 | 形状或类型 | 含义 |
|---|---|---|
| `gating_output` | `[T, E]` | routed 专家的原始 logits；当前 biased 路径使用 sigmoid 评分 |
| `correction_bias` | `[E]` | 专家选择偏置；与 `gating_output` 使用相同 dtype，只参与选择，不加入最终输出权重 |
| `topk_weights` | `[T, K]`，FP32 | 调用方分配的输出权重缓冲区 |
| `topk_ids` | `[T, K]`，int32 | 调用方分配的专家 ID 缓冲区，与权重逐槽配对 |
| `num_expert_group` | `int` | 将 `E` 个 routed 专家等分为多少组 |
| `topk_group` | `int` | 每个 token 保留的专家组数 |
| `num_fused_shared_experts` | `int` | 本次调用写入输出尾部的共享专家数 `S`；`S=0` 时选择 `K` 个 routed 专家，`S>0` 时选择 `K-S` 个 routed 专家并追加 `S` 个共享专家 |
| `need_renorm` | `bool` | 是否将所选 routed 专家的原始权重归一化；当前 fused-gate 分支要求为 `True` |
| `routed_scaling_factor` | `float`，默认 `1.0` | 路由阶段收到的倍率；实际使用方式取决于所选分支，见第二部分 |

输入及输出应位于同一设备。输入 logits、bias 按连续布局准备；输出最后一维连续，`topk_weights.stride(0)` 与 `topk_ids.stride(0)` 必须相同。内核使用输出行 stride，因此可将同形状的 routed 前缀视图作为输出，但调用方需保证底层缓冲区及视图有效。`E`、组数、组内专家数和 `K` 还需满足所选内核的支持范围；HIP 分发支持的组数为 `1/2/4/8`。

该接口原地写入输出。当前 HIP 分支返回 `None`，fused-gate 分支返回包含输出张量的列表；调用方应使用预先传入的 `topk_weights`、`topk_ids`，不依赖两条路径返回类型相同。依据：[`topk.py:88`](../aiter/ops/topk.py#L88)、[`moe_fused_gate.cu:786`](../csrc/kernels/moe_fused_gate.cu#L786)。

### 1.2 选择规则与共享专家

对于分组 biased 路由，选择和输出权重分开计算：

1. 计算原始权重分数 `s[t,e] = sigmoid(gating_output[t,e])`。
2. 计算选择分数 `q[t,e] = s[t,e] + correction_bias[e]`。
3. 每组取最大的两个 `q` 之和作为组分数，保留 `topk_group` 个组，再按 `q` 选择 routed 专家。
4. 输出权重取被选专家的 `s`，再按当前分支执行归一化及倍率处理。`correction_bias` 不属于输出权重。

`S>0` 时，当前 public 接口进入 fused gate，在输出尾部写入连续共享专家 ID `E, E+1, ..., E+S-1`。`K` 是包含共享槽的总宽度，因此 routed top-k 为 `K-S`。后续专家计算使用这些 ID 时，其专家权重和专家映射也必须覆盖相应共享专家。

`S=0` 仅表示**本次调用不融合共享专家**，模型仍可在其他路径计算共享专家。上层若预留共享尾槽，但只把 routed 前缀视图传入，这些尾槽也不属于本次调用的 `S`。

接口不统一保证按选择分数降序输出。比较结果时应按专家 ID 对齐权重；重排时必须同步移动 ID 和权重。

### 1.3 分发与调用示例

当前 public 分发条件见 [`topk.py:86`](../aiter/ops/topk.py#L86)：

```text
T <= get_cu_num() * 212 且 S == 0
    -> biased_grouped_topk_hip(..., need_renorm, routed_scaling_factor)

其他情况
    -> 要求 need_renorm=True
    -> moe_fused_gate(..., K, S, routed_scaling_factor)
```

阈值取决于运行设备的 CU 数，不是固定 token 数。`biased_grouped_topk_hip` 内部又分为普通内核和专用内核；它们都属于 HIP 入口，`moe_fused_gate` 是另一条分支。

```python
import torch
import aiter

T, E, K = 16, 256, 8
logits = torch.randn(T, E, device="cuda", dtype=torch.float32)
bias = torch.zeros(E, device=logits.device, dtype=logits.dtype)
weights = torch.empty(T, K, device=logits.device, dtype=torch.float32)
ids = torch.empty(T, K, device=logits.device, dtype=torch.int32)

aiter.biased_grouped_topk(
    gating_output=logits,
    correction_bias=bias,
    topk_weights=weights,
    topk_ids=ids,
    num_expert_group=8,
    topk_group=4,
    num_fused_shared_experts=0,
    need_renorm=True,
    routed_scaling_factor=2.5,
)
# 此小 batch 配置进入 HIP 专用内核；归一化开启时，weights 每行和约为 2.5。
```

## 2. routed_scaling_factor 的含义与前后两次应用

### 2.1 模型含义与两个独立参数

记模型配置要求的倍率为 `r`。对一个 token，设所选专家原始权重为 `s_i`，归一化权重为 `p_i = s_i / sum(s)`，专家输出为 `F_i(x)`。常规输出加权的 MoE 希望得到：

```text
need_renorm=True： routed(x) = r * sum_i(p_i * F_i(x))
need_renorm=False：routed(x) = r * sum_i(s_i * F_i(x))

有独立共享专家时：MoE(x) = routed(x) + shared(x)
```

倍率控制 routed 专家贡献的幅度，影响其与共享专家、残差分支的相对贡献。它在本次专家选择之后应用，不改变所选专家 ID。即使模型没有共享专家，routed 分支仍可要求非单位倍率。

下面区分同名参数的两次调用：

- `r_g`：传给 `biased_grouped_topk` 的 `routed_scaling_factor`。
- `r_m`：传给 `aiter_moe` 的 `routed_scaling_factor`。

这两个参数独立传入。`aiter_moe` 不读取前一次调用的倍率，也没有权重已缩放的标记或自动去重逻辑；其参数为 `None` 时按 `1.0` 处理。两次都传模型倍率 `r`，不代表最终一定只乘一次。

### 2.2 第一次应用：biased_grouped_topk 各分支

以下为正常有限输入的倍率公式，`p_i`、`s_i` 均只对应所选 routed 专家。

| public 所选路径 | `need_renorm` | routed 输出权重 | 融合 shared 输出权重 |
|---|---|---|---|
| HIP 普通内核 `grouped_topk_kernel` | `True` | `r_g * p_i` | 无；此分支 `S=0` |
| HIP 普通内核 `grouped_topk_kernel` | `False` | `r_g * s_i` | 无 |
| HIP 专用内核 `grouped_topk_opt_sort_kernel` | `True` | `r_g * p_i` | 无 |
| HIP 专用内核 `grouped_topk_opt_sort_kernel` | `False` | `r_g * s_i`；`r_g=1` 时跳过新增乘法 | 无 |
| fused gate，`S=0` | `True` | **`p_i`，没有乘 `r_g`** | 无 |
| fused gate，`S>0` | `True` | **`p_i`，没有乘 `r_g`** | 每个共享槽为 **`1/r_g`** |
| fused gate | `False` | public 断言拒绝 | 不执行 |

HIP 专用内核的条件为 `E=256、K=8、num_expert_group=8、topk_group=4`。当前两处写出分支均在关闭归一化时补乘 `r_g`；`r_g=1` 时跳过该乘法。归一化与倍率是两个独立操作，关闭前者不代表关闭后者。依据：[`普通 HIP:599`](../csrc/kernels/topk_softmax_kernels_group.cu#L599)、[`专用 HIP:1056`](../csrc/kernels/topk_softmax_kernels_group.cu#L1056)、[`另一写出分支:1089`](../csrc/kernels/topk_softmax_kernels_group.cu#L1089)、[`专用选择条件:1252`](../csrc/kernels/topk_softmax_kernels_group.cu#L1252)。

2026-10-20 的专用倍率修复回归已在 gfx936（Torch 2.10）和 gfx938（Torch 2.11）上完成：两种写出编译分支分别覆盖 FP32/FP16/BF16、归一化开关、倍率 `1/0.5/2.5`、连续及带 stride 输出、raw/public 分发，以及改变输入后的 Graph 回放；每个架构通过 144 组 eager 和 12 组 Graph 用例。默认写出实现中，倍率 `1` 的权重与 ID 和旧版逐位一致。验证使用隔离编译的原生内核及当前 Python 分发函数，不包含 `aiter_moe` 后端组合或完整模型测试；前后组合表仍为源码推导。回归入口见 [`test_biased_grouped_topk_scaling.py`](../op_tests/ci_tests/test_biased_grouped_topk_scaling.py)。

fused gate 先将共享槽设为 `sum(s)/r_g`，最后 routed 和 shared 均除以 routed 的 `sum(s)`，得到上表结果。融合共享专家时 `r_g` 必须非零。依据：[`moe_fused_gate.cu:372`](../csrc/kernels/moe_fused_gate.cu#L372)。

`biased_grouped_topk_torch` 是辅助参考：它不统一给 routed 权重乘 `r_g`，共享专家的处理方式也与 native fused gate 不完全相同，不能未经适配就作为所有分支的倍率参考。见 [`topk.py:116`](../aiter/ops/topk.py#L116)。

### 2.3 第二次应用：aiter_moe 各分支

`aiter_moe` 按 `moe_config.solution_type` 选择 `MOE_C/ASM/TRITON/CK`，并向对应入口传递 `r_m`。分发函数本身没有统一补乘；是否应用倍率取决于最终实现。入口见 [`moe.py:646`](../aiter/moe.py#L646)。

下表中的 `A` 表示使用**传入的 topk 权重**完成专家计算和加权聚合后的结果，已经包含第一次调用产生的倍率。若共享专家也在这些槽中，`A` 同样包含它们。

| 后端及实际子路径 | 对 `r_m` 的使用 | 第二阶段输出 | 依据 |
|---|---|---|---|
| `MOE_C` → `fused_experts_impl_marlin`，`topk=1` | 对输出执行 `mul_(r_m)` | `r_m * A` | [`fused_moe_c.py:4389`](../aiter/fused_moe_c.py#L4389) |
| `MOE_C` → `fused_experts_impl_marlin`，`topk>1` | `triton_moe_sum(..., r_m)` | `r_m * A` | [`fused_moe_c.py:4394`](../aiter/fused_moe_c.py#L4394) |
| `MOE_C` → 通用 `fused_experts_impl` | 形参存在，但函数体没有使用；`triton_moe_sum_noaiter` 只求和 | **`A`** | [`参数:4451`](../aiter/fused_moe_c.py#L4451)、[`聚合:4655`](../aiter/fused_moe_c.py#L4655) |
| `ASM` → `fused_experts_asm_impl` | 最后调用 `triton_moe_sum(..., r_m)` | `r_m * A` | [`fused_moe_asm_wna16.py:927`](../aiter/fused_moe_asm_wna16.py#L927) |
| `TRITON` → 外部 `boltops.fused_moe.triton.fused_moe.fused_experts_impl` | 默认 combine 路径最后求和并乘 `r_m` | `r_m * A` | [`导入与分发:827`](../aiter/moe.py#L827) |
| `CK` → `run_fused_experts_ck_impl` → one-stage / two-stage | 接收 `r_m`，但函数体不使用，也不传给两条下层入口 | **`A`** | [`fused_moe_ck.py:644`](../aiter/fused_moe_ck.py#L644) |

`triton_moe_sum` 对累加值执行 `acc *= routed_scaling_factor`，会缩放参与这次聚合的全部槽，没有按 routed/shared 分类乘倍率。见 [`aiter/ops/triton/fused_moe.py:120`](../aiter/ops/triton/fused_moe.py#L120)。

**MOE_C 必须继续区分内部子路径。** inplace、outplace 包装使用相同的 Marlin 选择条件，满足以下任一条件时走 `fused_experts_impl_marlin`，否则走通用 `fused_experts_impl`：

- `use_w16a16`、`use_int4_w4a16` 或 `use_fp4_w4a16`。
- `block_shape is None`，且使用 `int8_w8a8/fp8_w8a8/int8_w8a16/int8_w4a8/fp4_w4a8` 中的一种。
- 通过合法性检查的 `fp4_w4a8` groupwise 路径，当前 `block_shape=[0,32]`。

这些条件仍需通过对应量化配置的合法性检查。准确分流代码见 [`inplace:3531`](../aiter/fused_moe_c.py#L3531)、[`outplace:3629`](../aiter/fused_moe_c.py#L3629)。不能只根据后端名 `MOE_C` 就认定倍率一定应用。

TRITON 分支从安装环境导入 `boltops`。当前工作区对应实现可见 [`BoltOPs/fused_moe.py:1344`](../../BoltOPs/boltops/fused_moe/triton/fused_moe.py#L1344)，其 sum kernel 在 [`107 行`](../../BoltOPs/boltops/fused_moe/triton/fused_moe.py#L107)乘倍率；该依赖源码版本为 `5826c3d0536e5474690779068d4d9ebb442b3291`，部署时需与实际导入版本对应。底层 `no_combine=True` 会跳过这次求和和缩放；`aiter_moe` 当前不暴露该参数，使用默认 `False`。本仓库另有 `aiter.ops.triton.fused_moe`，但它不是这里 TRITON 分支导入的模块。

### 2.4 前后两次都传 r 时的最终行为

设 `r_g=r_m=r`。以下系数作用于本行的基础 routed 权重：开启归一化时为 `p_i`，关闭时为 `s_i`。表中没有额外的上层缩放；共享槽参与同一次专家聚合，并且对应专家有效。

| 第一次路由路径 | 会应用 `r_m` 的后端：MOE_C Marlin / ASM / TRITON combine | 不应用 `r_m` 的后端：MOE_C 通用 / CK |
|---|---|---|
| HIP 普通内核，归一化开启或关闭 | routed 系数 **`r²`：两次应用** | routed 系数 **`r`** |
| HIP 专用内核，归一化开启或关闭 | routed 系数 **`r²`：两次应用** | routed 系数 **`r`** |
| fused gate，`S=0`，归一化开启 | routed 系数 **`r`**，仅在专家阶段应用 | routed 系数 **`1`：没有应用** |
| fused gate，`S>0`，归一化开启 | routed 系数 **`r`**；每个 shared 系数 **`1`** | routed 系数 **`1`**；每个 shared 系数 **`1/r`** |

例如模型要求 `r=2.5`：第一阶段已乘倍率、第二阶段再次应用时，最终 routed 系数为 `6.25`；只有一次应用时为 `2.5`；两阶段均未应用时为 `1`。这些数值是倍率系数，不是完整模型输出或精度结果。

融合共享专家的抵消关系为：

```text
路由输出：      sum_i(p_i * F_i(x)) + shared(x) / r_g
专家阶段再缩放：r_m * sum_i(p_i * F_i(x)) + (r_m / r_g) * shared(x)

r_g = r_m = r： r * sum_i(p_i * F_i(x)) + shared(x)
```

如果共享专家在路由调用外独立计算，则应在 routed 分支缩放完成后相加；只有一起进入同一次整体缩放的共享槽才使用上述补偿关系。

### 2.5 调用时如何确定倍率归属

| 当前实际路径 | 为得到模型要求的倍率 r，参数应如何配合 |
|---|---|
| HIP 已给 routed 权重乘倍率的路径 | `r_g=r`；若专家后端会应用倍率，则 `r_m=1`，避免再次缩放 |
| fused gate + 会应用倍率的专家后端 | 由专家阶段应用 `r_m=r`；融合共享专家时同时令 `r_g=r`，使 shared 的 `1/r_g` 被抵消 |
| HIP 专用内核关闭归一化 | 与普通 HIP 相同：`r_g=r`；若专家后端会应用倍率，则 `r_m=1` |
| fused gate + MOE_C 通用或 CK | 两个同名参数不能自动得到目标 routed 倍率；融合 shared 时还保留 `1/r_g`，需要明确的额外处理或实现修复 |

因此，`num_fused_shared_experts==0` 不能单独决定倍率应该传 `1` 还是 `r`，也不能只改路由实参而忽略后续实际后端。应同时确定路由分支、`need_renorm`、MOE_C 内部实现及依赖版本，再按前后组合表验收。
