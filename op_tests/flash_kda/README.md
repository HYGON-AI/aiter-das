# FlashKDA 使用说明

FlashKDA 提供 gfx936 上的 Kimi Delta Attention 前向计算，支持定长和 packed 变长输入，以及 FP32/BF16 递推状态。

用户主入口为 `aiter.ops.flash_kda.fwd`。结果写入调用者提供的输出张量，函数返回 `None`。已有 AITER 调用方可继续使用 `chunk_kimi_delta_attn` 兼容入口。

**数据契约：beta 为 FP32/BF16、sigmoid 前的 logits；state 默认 `[K,V]`，设置 `state_v_first=True` 使用 `[V,K]`。** 当前要求 `K=V=128`，Q、K、V 和 g 使用 BF16。

## 使用前准备

在可正常导入当前 AITER 包的 gfx936 环境中使用。当前验证环境为 PyTorch 2.9、Triton 3.5 和 DTK；这里不将这些已验证版本表述为最低版本要求。安装和构建沿用所交付 AITER 仓库的说明。

ROCm/HIP 环境中仍使用 PyTorch 的 `torch.cuda` 接口。首次调用或 workspace 大小查询可能加载、构建 native 扩展，首次耗时不代表稳定调用耗时。

## 运行定长输入

每个 batch 元素是一条独立序列。下面的示例包含初态和终态：

```python
import torch
from aiter.ops.flash_kda import fwd

B, T, H, K, V = 1, 128, 6, 128, 128
device = torch.device("cuda")

q = torch.randn(B, T, H, K, device=device, dtype=torch.bfloat16)
k = torch.randn_like(q)
v = torch.randn(B, T, H, V, device=device, dtype=torch.bfloat16)
g = torch.randn_like(q)
beta = torch.randn(B, T, H, device=device, dtype=torch.float32)
A_log = torch.randn(H, device=device, dtype=torch.float32)
dt_bias = torch.randn(H, K, device=device, dtype=torch.float32)

h0 = torch.randn(B, H, K, V, device=device, dtype=torch.float32)
out = torch.empty_like(v)
ht = torch.empty_like(h0)

fwd(q, k, v, g, beta, K ** -0.5, out, A_log, dt_bias, -5.0,
    initial_state=h0, final_state=ht)
```

调用后，`out` 保存注意力输出，`ht` 保存每条序列的终态。`fwd` 内部固定完成 QK L2 归一化、gate 激活和 beta sigmoid；传入的 `g` 与 `beta` 应为对应激活之前的值。

如不使用初态，省略 `initial_state`，计算从零状态开始；如不需要终态，省略 `final_state`。`out` 始终由调用者提供。

## 接口与参数

```text
fwd(q, k, v, g, beta, scale, out, A_log, dt_bias, lower_bound,
    initial_state=None, final_state=None, cu_seqlens=None, *,
    workspace=None, state_v_first=False) -> None
```

| 参数 | 类型 | 形状/含义 |
|---|---|---|
| `q` | BF16 Tensor | `[B,T,H,K]` |
| `k` | BF16 Tensor | 与 q 相同 |
| `v` | BF16 Tensor | `[B,T,H,V]`，head 数与 q 一致 |
| `g` | BF16 Tensor | `[B,T,H,K]`，gate 原始值 |
| `beta` | FP32/BF16 Tensor | `[B,T,H]`，sigmoid 前的 logits；内部以 FP32 执行 sigmoid |
| `scale` | 正标量 | 通常取 `K ** -0.5` |
| `out` | BF16 Tensor | 与 v 相同，必填、原位写出 |
| `A_log` | FP32 Tensor | `[H]`，gate 参数，必填 |
| `dt_bias` | FP32 Tensor 或 `None` | 首选 `[H,K]`；也接受连续的 `[H*K]` |
| `lower_bound` | 标量 | safe gate 下界，范围 `[-5,0)` |
| `initial_state` | FP32/BF16 Tensor 或 `None` | 定长 `[B,H,K,V]`；变长 `[N,H,K,V]`；VK 布局交换最后两轴；缺省为零初态 |
| `final_state` | FP32/BF16 Tensor 或 `None` | 终态输出 buffer；形状同上述 state 规则；缺省不输出终态 |
| `cu_seqlens` | INT32/INT64 Tensor 或 `None` | packed 变长序列边界 `[N+1]` |
| `workspace` | uint8 Tensor 或 `None` | 可复用 scratch；缺省由实现分配 |
| `state_v_first` | bool | 默认 False 使用 KV；True 使用 VK；同时决定初态与终态的布局 |

所有张量必须位于同一 GPU 且连续。主入口不会自动复制非连续输入。当前只支持 `K=V=128`，不支持不同的 Q/K 与 V head 数。

定长输入要求 `B>0`、`T>0`、`H>0`；变长输入允许总 token 数为零，但仍须描述至少一条序列。

### 初态与终态

- `initial_state=None` 表示零初态，与是否请求终态无关。
- 同时提供初态和终态 buffer 时，两者 dtype 必须相同。
- 只提供终态 buffer 时，使用其 FP32/BF16 dtype 写出终态。
- `state_v_first=False` 时元素含义为 `state[sequence, head, key, value]`；True 时为 `state[sequence, head, value, key]`。K 和 V 的大小同为 128，不能从 shape 推断布局。
- 初态和终态共用同一布局参数，不支持一次调用混用两种布局。实现直接读取和写出指定布局，不自动转置。
- 输出 buffer、scratch 与输入不能重叠；输出 buffer 之间也不能重叠。因此不能直接将同一 state 张量同时作为初态和终态。

以下代码接续定长示例，将同一初态转为 VK，并使用 BF16 beta：

```python
h0_vk = h0.transpose(-1, -2).contiguous()
ht_vk = torch.empty_like(h0_vk)
beta_bf16 = beta.to(torch.bfloat16)
fwd(q, k, v, g, beta_bf16, K ** -0.5, out, A_log, dt_bias, -5.0,
    initial_state=h0_vk, final_state=ht_vk, state_v_first=True)
```

若已有 VK 初态，可直接传入，无需转置。BF16 beta 在 K1 装载后提升为 FP32，激活后的内部 beta 保持 FP32，不增加转换 kernel。将已有 FP32 beta 量化为 BF16 会舍入输入值，因此两种输入不保证得到相同结果。

## 运行变长输入

packed 输入的物理 batch 固定为 1，所有序列的 token 沿 T 维拼接。N 表示逻辑序列数，初态和终态的第一维为 N。

下面是一段独立示例，第二条序列长度为零：

```python
import torch
from aiter.ops.flash_kda import fwd

device = torch.device("cuda")
lengths = [10, 0, 30, 500]
N, H, K, V = len(lengths), 6, 128, 128
bounds = [0]
for length in lengths:
    bounds.append(bounds[-1] + length)
T_total = bounds[-1]
cu = torch.tensor(bounds, device=device, dtype=torch.int64)

q = torch.randn(1, T_total, H, K, device=device, dtype=torch.bfloat16)
k = torch.randn_like(q)
v = torch.randn(1, T_total, H, V, device=device, dtype=torch.bfloat16)
g = torch.randn_like(q)
beta = torch.randn(1, T_total, H, device=device, dtype=torch.float32)
A_log = torch.randn(H, device=device, dtype=torch.float32)
h0 = torch.randn(N, H, K, V, device=device, dtype=torch.float32)
out = torch.empty_like(v)
ht = torch.empty_like(h0)

fwd(q, k, v, g, beta, K ** -0.5, out, A_log, None, -5.0,
    initial_state=h0, final_state=ht, cu_seqlens=cu)
```

`cu_seqlens` 必须满足：

- `cu[0] == 0`。
- 元素单调不减，序列 s 的长度为 `cu[s+1] - cu[s]`。
- `cu[-1] == T_total`，即输入 T 维的长度。
- 连续、同 GPU、一维 INT32 或 INT64，长度为 `N+1`。

调用者负责保证边界值有效。当前实现会检查结构、类型与设备条件，但不会逐项验证上述边界数值；不要将格式校验视为完整的 cu 内容验证。

空序列不产生输出 token；请求终态时，空序列的终态等于其初态，无初态则为零。全部序列为空时，输出的 T 维为零，上述终态规则仍适用。

## 复用 workspace

默认 `workspace=None` 时，实现为当前调用分配 scratch。需要减少重复分配时，在 setup 阶段查询容量并复用 buffer：

```text
get_workspace_size(batch, tokens, heads, *,
                   sequence_count=None, is_varlen=False) -> int
```

返回值单位为字节。定长模式下 `sequence_count` 缺省等于 batch；变长模式须显式提供序列数 N，并设置 `is_varlen=True`。

以下为完整的变长预分配示例：

```python
import torch
from aiter.ops.flash_kda import fwd, get_workspace_size

device = torch.device("cuda")
lengths = [10, 0, 30, 500]
N, H, K, V = len(lengths), 6, 128, 128
bounds = [0]
for length in lengths:
    bounds.append(bounds[-1] + length)
T_total = bounds[-1]
cu = torch.tensor(bounds, device=device, dtype=torch.int64)

q = torch.randn(1, T_total, H, K, device=device, dtype=torch.bfloat16)
k, g, v = torch.randn_like(q), torch.randn_like(q), torch.randn_like(q)
beta = torch.randn(1, T_total, H, device=device, dtype=torch.float32)
A_log = torch.randn(H, device=device, dtype=torch.float32)
h0 = torch.randn(N, H, K, V, device=device, dtype=torch.float32)
out, ht = torch.empty_like(v), torch.empty_like(h0)

size = get_workspace_size(1, T_total, H, sequence_count=N, is_varlen=True)
workspace = torch.empty(size, device=device, dtype=torch.uint8)
fwd(q, k, v, g, beta, K ** -0.5, out, A_log, None, -5.0,
    initial_state=h0, final_state=ht, cu_seqlens=cu, workspace=workspace)
```

定长查询使用 `get_workspace_size(B,T,H)`，对应的调用不传 `cu_seqlens`，状态形状为 `[B,H,K,V]`。

scratch 必须连续、同 GPU、uint8，基址按 16 字节对齐，容量不小于查询结果，且不与输入输出重叠。使用正常的 `torch.empty(size, dtype=torch.uint8, device=...)` 分配即可满足基础对齐要求。

修改 shape、逻辑序列数、定长/变长模式或分段回滚配置后，应重新查询所需容量。改变配置前查询的容量不作为新配置的保证。

并发中的不同调用应使用独立的 out、final_state 和 workspace。上一次使用结束后可以顺序复用；本接口不管理调用者的排队和资源互斥。

## 使用 AITER 兼容入口

既有调用方可继续使用：

```python
from aiter.ops.triton.kimi_delta_attn import chunk_kimi_delta_attn
```

它自动分配输出并返回 `(out, final_state)`，其中 `output_final_state=False` 时 final_state 为 `None`。与主 fwd 不同，它保留既有的预处理参数和后端选择语义。

兼容入口的 HCU 路径同样接受 FP32/BF16 beta，并通过 `state_v_first=False/True` 选择 KV/VK 状态布局，默认 KV。

下面的代码接续“运行定长输入”一节的输入定义，显式使用 HCU：

```python
import os
from aiter.ops.triton.kimi_delta_attn import chunk_kimi_delta_attn

os.environ["FLASH_KDA_BACKEND"] = "hcu"
out, ht = chunk_kimi_delta_attn(
    q, k, v, g, beta,
    A_log=A_log, dt_bias=dt_bias, scale=K ** -0.5,
    initial_state=h0, output_final_state=True, state_dtype=h0.dtype,
    use_qk_l2norm_in_kernel=True,
    use_gate_in_kernel=True,
    use_beta_sigmoid_in_kernel=True,
    safe_gate=True, lower_bound=-5.0,
)
```

这四个布尔参数用于兼容既有调用形式。当前 HCU 路径要求它们为 True；主 fwd 固定相同计算语义，无需传这些参数。兼容入口的其它 Triton 能力不代表主 fwd 支持相同输入范围。

### 后端选择与排障

| 环境变量 | 影响范围 | 行为 |
|---|---|---|
| `FLASH_KDA_BACKEND` | 兼容入口 | `hcu` 强制 HCU；`triton` 选择 Triton；`auto` 按 HCU 启用设置尝试并回退。不识别的值报错 |
| `FLASH_KDA_HCU_ENABLE` | 兼容入口的 auto 模式 | 未设置时不自动启用 HCU；`1/true/yes/on` 启用 HCU 尝试 |
| `FLASH_KDA_HCU_SEGMENT` | 主 fwd 和兼容入口的 HCU 路径 | 缺省或 `auto` 使用自动路由；`0/off/false/none` 强制 plain。其它非空取值报错 |

主 fwd 固定使用受支持的 HCU 路径，不因 BACKEND 或 ENABLE 改成 Triton。分段粒度由实现自动决定，用户不需要传 CPS 或内部布局参数。

## 与官方 FlashKDA 的差异

本项目借鉴官方的调用形式，数据契约并非完全兼容。官方定义见 [FlashKDA Python 接口](https://github.com/MoonshotAI/FlashKDA/blob/master/flash_kda/__init__.py)。

| 项 | 官方接口文档 | 本项目主入口 |
|---|---|---|
| 导入路径 | `flash_kda.fwd` | `aiter.ops.flash_kda.fwd` |
| beta | BF16、sigmoid 前的值 | FP32 或 BF16、sigmoid 前的值 |
| state | `[B,H,V,K]` / `[N,H,V,K]` | 默认 KV；设置 `state_v_first=True` 使用官方的 VK 布局 |
| dt_bias | FP32 `[H,K]` | 同时接受 `[H,K]` 和扁平 `[H*K]` |
| cu_seqlens | INT64 | INT32 或 INT64 |
| 调用者传 workspace | 公开 fwd 签名未提供该参数 | 可选的仅关键字参数 `workspace` |

迁移官方调用时，BF16 beta 可直接传入；VK state 必须显式设置 `state_v_first=True`。导入路径及可选参数仍有上述差异，不能将两套接口视为完全相同。

## 常见调用错误

| 现象 | 检查内容 |
|---|---|
| `NotImplementedError`，输入不支持 | 设备是否 gfx936，K/V 是否为 128，q/k/v/g 是否 BF16，beta 是否 FP32/BF16；不接受 FP16 beta |
| state dtype 冲突 | initial_state 与 final_state 是否同为 FP32 或同为 BF16 |
| state 布局或形状不符 | 定长第一维是 B，变长第一维是 N；最后两维必须与 `state_v_first` 一致 |
| 连续性或设备错误 | 所有张量是否连续且在同一 GPU；主 fwd 不隐式连续化输入 |
| workspace 容量或对齐错误 | 是否按当前 shape/模式/路由重新查询，是否误用不对齐的切片 |
| buffer 重叠错误 | 是否将初态当作终态原位覆盖，或使 out/scratch 与输入共享重叠区域 |
| 变长边界异常 | cu 是否从 0 开始、单调不减、以 T_total 结束；状态第一维是否与 N 一致 |

## 测试

在仓库根目录运行：

```bash
python3 -m pytest -q op_tests/flash_kda/
```

也可以运行 `bash op_tests/flash_kda/run_tests.sh`。该脚本只定位仓库并执行 pytest，透传退出码。

| 测试文件 | 内容 |
|---|---|
| `test_api.py` | 公共接口、dtype、输出 buffer、错误与兼容入口 |
| `test_fwd.py` | 定长、尾块、变长、状态组合及两种 beta dtype，对照独立 Triton 实现 |
| `test_internal.py` | workspace、metadata、尾块哨兵、未用槽、graph 和多 stream 回归 |

需要 GPU 的用例在不满足 gfx936 条件时跳过，查看 pytest 汇总中的 skip 原因。测试代码不获取设备锁、不执行宿主负载预检，也不等待资源；共享机器的资源协调由启动者或外部调度器负责。

## 测量性能

在仓库根目录运行：

```bash
python3 -m op_tests.flash_kda.bench_fwd
```

脚本沿用官方 [benchmarks/bench_fwd.py](https://github.com/MoonshotAI/FlashKDA/blob/d7e3b3a9f448500630fa60fb5200f4f9c9b1fc72/benchmarks/bench_fwd.py) 的 FlashKDA 输入生成与计时方式，只将入口替换为 `aiter.ops.flash_kda.fwd`，显式设置 `state_v_first=True` 使用官方 VK 状态。beta 为 BF16；不运行官方脚本中的 FLA/GDN 对照。

默认 K=V=128、H=96，运行以下三组输入；每组依次测 BF16 state、无初终态、FP32 state，共 9 条结果：

| 模式 | 物理 B | T / packed 序列长度 |
|---|---|---|
| 定长 | 1 | T=8192 |
| packed 6 段 | 1 | `[1300,547,2048,963,271,3063]` |
| packed 8 段 | 1 | `[1024]×8` |

每组设置 seed=42，在 GPU 上按官方顺序生成输入。out/final_state 在计时前分配并清零，workspace 留在 fwd 调用内分配；无状态臂不传初态和终态。30 次预热后，运行 5 轮、每轮 200 次调用，每次调用一对 GPU event，每轮结束同步，汇总 1000 个样本的算术平均值、最小值和最大值，单位为 ms。入口导入、输入准备及预热不计入样本，不增加 wall 计时、签名检查或 dtype/布局转换。

可使用与官方相同的参数调整运行范围和采样次数：

```bash
python3 -m op_tests.flash_kda.bench_fwd \
  --mode all --H 96 --D 128 --warmup 30 --iters 200 --repeats 5 --seed 42
```

`--mode` 支持 fixed、varlen、all，用于筛选默认用例。也可直接指定其他用例，所有用例沿用同一个计时函数：

```bash
# 定长：B=128、每条序列 T=1、H=96
python3 -m op_tests.flash_kda.bench_fwd --shape 128,1,96

# packed：四条序列，物理 B=1、总 T=540、H=6
python3 -m op_tests.flash_kda.bench_fwd --lengths 10,20,30,480 --H 6

# 一次运行多组定长输入
python3 -m op_tests.flash_kda.bench_fwd --shape 1,1,6 --shape 1,1024,96
```

`--shape B,T,H` 与 `--lengths L1,L2,...` 均可重复指定，也可混用；显式指定后只运行这些输入，不追加默认三组，也不与 `--mode` 混用。B、T、H 及各序列长度须为正整数；packed 的 H 由 `--H` 指定，定长使用 `--shape` 内的 H。每组仍分别测 BF16 state、无状态和 FP32 state。

正确性由 pytest 单独验收；性能脚本不持锁、不预检或等待负载，资源协调由启动者负责。比较时应保持输入、状态配置、分配边界与采样参数一致；不同 CUDA/HIP 实现使用同 seed 不保证随机张量逐位相同。

---










## 复测 bw65 性能（完整步骤）

本节给出把性能表 `bw65同口径: ms TP=1采用定长` 与 `同口径加速比 bw65/h20` 两列重新测出来并写回表格的完整流程，命令可直接复制执行。

### 0. 复测口径（与性能表一致）

| 项 | 取值 |
|---|---|
| 形状 | `D=128`、`K=V=128`；定长 `B,T,H`，变长物理 `B=1` + `cu_seqlens` |
| 输入 | `q/k` 按 L2 归一化后转 BF16；`v/g` BF16；`beta` BF16（sigmoid 前 logits）；`scale=1/sqrt(128)`；`lower_bound=-5` |
| 状态 | `state_v_first=True`（官方 VK 布局），初/终态同 dtype、同布局 |
| 计时 | `warmup=30`，`iters=200`，`repeats=5`，CUDA/HIP event 逐次计时，取 1000 个样本的 `mean` |
| 随机性 | 每个配置重置 `seed=42` |
| 分组 | 多头长序列 H=96（T=1024…8192）、少头长序列 H=6、少头短序列 T=1 扫 B、多头短序列 T=1 扫 B、变长 5 组 |
| 状态变体 | `bf16 1/1`、`none 0/0`、`fp32 1/1`、`bf16 1/0`、`fp32 1/0`、`bf16 0/1`、`fp32 0/1` |
| 判定 | 与表中 `bw1000同口径 ms` 比，长序列/变长 ±10% PASS；T=1 短序列因 launch 开销建议 ±15%~25% |

### 1. 选对环境（关键，否则数值不过）

| 容器 | 运行时 | 数值（`test_fwd`） | 是否可用于复测 |
|---|---|---|---|
| `xuwei01_flashkda_test1_bw65` | py3.10.12 / torch 2.11.0 / HIP 6.3.26113 / DTK 26.04 | **46 passed** | **推荐**，本表数据在此环境产生 |
| `xuwei01_flashkda_test_bw65` | py3.12 / torch 2.11.0 / HIP 7.2.26365 / DTK 26.10 | 44 failed / 2 passed（`final_state` key 行 64–127 被写成 ~2.5e8） | 不建议；只能用来验证编译/契约，计时不可信 |

两个容器都挂载同一个仓库（宿主 `/public/home/xuwei01` → 容器 `/home/work`），所以**切换容器必须清理 `.so`**，见第 3 步。

### 2. 选卡与进容器（宿主执行）

```bash
# 看卡：HCU% / VRAM% 都为 0 表示空闲
hy-smi

# 选卡 3，进容器
export HIP_VISIBLE_DEVICES=3
docker exec -it xuwei01_flashkda_test1_bw65 bash
```

容器内 `torch.cuda.get_device_properties(0)` 对应物理 3 号卡。

### 3. 清理跨 Python 版本的扩展产物

容器内继续执行：

```bash
cd /home/work/aiter
ls aiter/jit/*.so 2>/dev/null | wc -l
rm -f aiter/jit/*.so
rm -rf aiter/jit/build/module_aiter_enum aiter/jit/build/module_flash_kda_hcu
```

不清会报 `ImportError: Python version mismatch: module was compiled for Python 3.10/3.12` 或 `undefined symbol: PyObject_Vectorcall`。

### 4. 环境变量（源码模式）

```bash
cd /home/work/aiter
echo develop > aiter/install_mode        # JIT 读 csrc/，而不是 aiter_meta/csrc 快照
export PYTHONPATH=/home/work/aiter
export HIP_VISIBLE_DEVICES=3
unset AITER_CODE_OBJECT_VERSION          # DTK 26.04 容器用编译器默认 COV，不要设 5
```

> 只有在 DTK 26.10 / HIP 7.2 容器里才需要 `export AITER_CODE_OBJECT_VERSION=5`。

### 5. 编译并自检

```bash
cd /home/work/aiter
export PYTHONPATH=/home/work/aiter HIP_VISIBLE_DEVICES=3
unset AITER_CODE_OBJECT_VERSION

# 用 compile_ops 路径触发编译（get_module 不编译）；首次约 4 分钟
AITER_REBUILD=1 MAX_JOBS=1 AITER_PREBUILD_VERBOSE=1 \
python -c "from aiter.ops.flash_kda import get_workspace_size; print('workspace_bytes:', get_workspace_size(1, 8192, 96))"

# 自检
python -c "from aiter.jit.core import AITER_CSRC_DIR; print(AITER_CSRC_DIR)"     # 期望 /home/work/aiter/csrc
python -c "import torch,triton; p=torch.cuda.get_device_properties(0); print(torch.__version__, torch.version.hip, triton.__version__, p.gcnArchName, p.multi_processor_count)"
ls -l aiter/jit/module_flash_kda_hcu.so
```

期望输出包含 `workspace_bytes: 682622976`、`gfx936:sramecc+:xnack-`、`80`。

### 6. 数值闸门（不绿就不要测性能）

```bash
cd /home/work/aiter
export PYTHONPATH=/home/work/aiter HIP_VISIBLE_DEVICES=3

python -m pytest op_tests/flash_kda/test_api.py -q        # 30 passed
python -m pytest op_tests/flash_kda/test_fwd.py -q        # 46 passed  ← 关键
python -m pytest op_tests/flash_kda/test_internal.py -q   # 34 passed
```

`test_fwd` 不过时先看第 12 节，不要继续测性能。

### 7. 跑性能 sweep（约 7 分钟 / 单卡）

```bash
cd /home/work/aiter
export PYTHONPATH=/home/work/aiter HIP_VISIBLE_DEVICES=3

python op_tests/flash_kda/perf_sweep.py --out /tmp/kda_measured.csv
```

CSV 列：`group,batch,seq,heads,dim,state_dtype,has_state_in,has_state_out,mean_ms,min_ms,max_ms`；共 52 个配置 × 7 个状态变体 = 364 行。变长行的 `batch` 写**序列条数 N**（不是物理 `B=1`），与表格 key 对齐。

只跑部分分组或快速冒烟：

```bash
python op_tests/flash_kda/perf_sweep.py --groups short_h6 --limit 2 --out /tmp/kda_q.csv
python op_tests/flash_kda/perf_sweep.py --groups long_h96,long_h6,varlen --out /tmp/kda_long.csv
```

单点复核（与 sweep 同计时口径）：

```bash
python op_tests/flash_kda/bench_fwd.py --shape 48,1,6
python op_tests/flash_kda/bench_fwd.py --shape 1,8192,96 --shape 1,1024,6
```

### 8. 与性能表比对

先把官方表的 `bw1000` 列转成 expected CSV（需要 `openpyxl`，缺失时 `pip install openpyxl`）：

```bash
cd /home/work/aiter
python op_tests/flash_kda/perf_compare.py \
  --from-xlsx /home/work/aiter_test/flashkda_official_h20_vs_bw1000_performance.xlsx \
  --out-expected /tmp/kda_expected.csv

python op_tests/flash_kda/perf_compare.py \
  --measured /tmp/kda_measured.csv \
  --expected /tmp/kda_expected.csv \
  --out /tmp/kda_compare.csv --tol 0.10
```

期望 `matched=105 missing_in_measured=0`。分组统计（本次实测）：

| 组 | n | ±10% PASS | 中位偏差 | 最大偏差 |
|---|---|---|---|---|
| long_h96（多头长序列） | 16 | 16 | +5.8% | +8.8% |
| long_h6（少头长序列） | 16 | 12 | +1.1% | +13.6% |
| varlen | 11 | 11 | +5.8% | +6.4% |
| short_h6（T=1） | 32 | 7 | +13.0% | +24.6% |
| short_h96（T=1） | 30 | 10 | +13.4% | +22.9% |

T=1 短序列系统性偏慢约 13%，绝对差 10–20 µs，属于 launch/CPU 开销，与出表机器差异，不是脚本口径问题。

### 9. 写回表格（只改 K、L 两列）

目标表：`/home/work/aiter_test/flashkda_official_h20_vs_bw1000_performance_20261109.xlsx`
（宿主 `/public/home/xuwei01/aiter_test/...`）

方式 A：就地更新，K=实测 ms，L 保留 `=H{row}/K{row}`，其余列、样式、备注合并块不动：

```bash
cd /home/work/aiter_test
cp flashkda_official_h20_vs_bw1000_performance_20261109.xlsx /tmp/backup.xlsx
python - <<'PY'
import csv, openpyxl

def norm_dtype(v):
    t = str(v or "").strip().lower()
    return "bf16" if t in ("bf16", "bfloat16") else ("fp32" if t in ("fp32", "float32") else "none")

def to_int(v):
    t = str(v).strip().lower()
    if t in ("true", "1", "1.0", "yes", "on"):
        return 1
    if t in ("false", "0", "0.0", "", "none"):
        return 0
    return int(float(t))

def to_seq(v):
    t = str(v or "").strip()
    if t.startswith("["):
        return int(sum(int(x) for x in t.strip("[]").split(",") if x.strip()))
    return int(float(t))

# 1) 读 sweep 结果
measured = {}
for row in csv.DictReader(open("/tmp/kda_measured.csv")):
    key = (int(float(row["batch"])), int(float(row["seq"])), int(float(row["heads"])),
           norm_dtype(row["state_dtype"]), to_int(row["has_state_in"]), to_int(row["has_state_out"]))
    measured[key] = float(row["mean_ms"])

# 2) 定位 K/L 列（按表头关键字，避免列序变化）
f = "flashkda_official_h20_vs_bw1000_performance_20261109.xlsx"
wb = openpyxl.load_workbook(f)
ws = wb[wb.sheetnames[0]]
header = [" ".join(str(c.value or "").replace("\n", " ").split()) for c in ws[1]]
ms_col = next(i for i, n in enumerate(header, 1) if "bw65" in n)
ratio_col = next(i for i, n in enumerate(header, 1) if "加速比 bw65" in n)

# 3) 逐行匹配写入
hit = miss = 0
for r in range(2, ws.max_row + 1):
    if ws.cell(r, 1).value in (None, ""):
        continue
    key = (int(float(ws.cell(r, 1).value)), to_seq(ws.cell(r, 2).value), int(float(ws.cell(r, 3).value)),
           norm_dtype(ws.cell(r, 7).value), to_int(ws.cell(r, 5).value), to_int(ws.cell(r, 6).value))
    value = measured.get(key)
    if value is None:
        miss += 1
        print("missing row", r, key)
        continue
    cell = ws.cell(r, ms_col, round(value, 6))
    cell.number_format = "0.0000"
    ws.cell(r, ratio_col).value = f"=H{r}/K{r}"
    hit += 1

wb.save(f)
print(f"updated={hit} missing={miss} ms_col={ms_col} ratio_col={ratio_col}")
PY
```

方式 B：由原始表生成一份新副本（`fill_bw65_perf_xlsx.py` 会新建工作表逐格复制，保留备注合并块）：

```bash
cd /home/work/aiter_test
python fill_bw65_perf_xlsx.py \
  --src flashkda_official_h20_vs_bw1000_performance.xlsx \
  --measured /tmp/kda_measured.csv \
  --dst flashkda_official_h20_vs_bw1000_performance_20261109.xlsx
```

写回后自检：

```bash
python - <<'PY'
import openpyxl
f = "flashkda_official_h20_vs_bw1000_performance_20261109.xlsx"
ws = openpyxl.load_workbook(f).active
print("dims", ws.max_row, ws.max_column, "merged", len(ws.merged_cells.ranges))
for r in (2, 9, 44, 100, 107):
    h, k = float(ws.cell(r, 8).value), ws.cell(r, 11).value
    print(r, "h20=", h, "bw65=", k, "speedup=", round(h / k, 2), "L=", ws.cell(r, 12).value)
PY
```

### 10. 一键脚本（可选）

`accept_hcu.sh` 把「自检 → 重建 → 三项测试 → sweep → 比对」串起来：

```bash
cd /home/work/aiter
export PYTHONPATH=/home/work/aiter HIP_VISIBLE_DEVICES=3
bash op_tests/flash_kda/accept_hcu.sh --expected /tmp/kda_expected.csv --out-dir /tmp/kda_accept
bash op_tests/flash_kda/accept_hcu.sh --skip-build --skip-tests     # 只重跑 sweep + 比对
```

注意该脚本内部默认 `AITER_CODE_OBJECT_VERSION=5`；在 DTK 26.04 / HIP 6.3 容器里不要用它做全量构建，请按第 4–7 步手动执行（或先清理 `aiter/jit/build/module_flash_kda_hcu` 再手动编译）。

### 11. 复现结论参考

- 105 行全部匹配，长序列（H=96）16/16、变长 11/11 在 ±10% 内；少头长序列 12/16。
- T=1 短序列 56% 行超 ±10%，但绝对差仅 10–20 µs，属环境相关，建议单独放宽阈值。
- 同一容器重复跑，行级中位差异 <0.1%、最大 <7%；换容器（DTK 26.10）长序列整体慢约 8%，不建议混用两套数据。

### 12. 排障

| 现象 | 原因 | 处理 |
|---|---|---|
| `Python version mismatch` / `undefined symbol: PyObject_Vectorcall` | 另一 Python 版本的 `.so` 残留 | 删 `aiter/jit/*.so` 与对应 `aiter/jit/build/module_*` 后重编 |
| `No module named aiter.jit.module_flash_kda_hcu` | 用 `get_module` 触发（不编译） | 改用 `get_workspace_size` 等 `compile_ops` 路径 |
| `hipErrorNoBinaryForGpu` | COV 与运行时不符 | DTK 26.10 容器设 `AITER_CODE_OBJECT_VERSION=5` 且 `AITER_REBUILD=1`；DTK 26.04 容器不要设 |
| `AITER_CSRC_DIR` 指向 `aiter_meta/csrc` | `install_mode` 不是 develop | `echo develop > aiter/install_mode` |
| `test_fwd` 大面积失败、`final_state` ~1e8 | 运行时/编译器配套问题（HIP 7.2 + DTK 26.10） | 换 `xuwei01_flashkda_test1_bw65`（DTK 26.04） |
| 比对出现 11 行 `missing` | 变长行 `batch` 写成物理 `B=1` | 变长行 `batch` 写序列条数 `N` |
| 比对 `missing` 且 dtype 对不上 | 标签写成 `bf16_in_only` 之类 | `state_dtype` 只用 `bf16`/`fp32`/`none`，靠 `has_state_in/out` 区分 |
| 短序列整体偏慢 10–25% | launch/CPU 开销占比高 | 与同机 `bench_fwd.py` 单点交叉验证，按 ±15%~25% 判定 |

> 复测结束若要把仓库交回 py3.12 容器使用，必须重新清理 `.so` 并按该容器的 COV 重新编译，否则导入失败。
