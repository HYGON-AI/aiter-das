# Custom AllReduce 超节点测试

本目录用于验证 Aiter `custom_all_reduce` 在多个物理节点之间通过 HSA RPC
Fabric 内存完成通信。测试按每节点4张HCU组织，支持以下常用拓扑：

- 8 ranks：2节点
- 16 ranks：4节点
- 32 ranks：8节点
- 40 ranks：10节点

以下命令使用 `aiter` 作为工程目录名。通信网卡默认为 `em1`，可通过
`AITER_SUPERNODE_IFACE` 覆盖。

### 普通 AllReduce 输入大小

普通 `CustomAllreduce.should_custom_ar()` / `custom_all_reduce()` 默认允许
每 rank 最大 **256 MiB** 的输入，并始终受 `max_size / 2` 的容量约束。
框架无需传入 `prefill_support=True`；SGLang 的外层筛选与 AITER 包装函数
内部复检会采用同一策略。默认 `max_size=1 GiB`，本次调整不会改变其预分配
input/meta 缓冲区大小，也不会固定按256MiB复制数据，实际复制量等于输入大小。

可在启动所有 rank 前设置正整数环境变量 `AITER_AR_MAX_SIZE_MB`（单位为
MiB，即1024×1024字节）覆盖普通 AllReduce 门限，例如 `64` 可恢复旧的
普通 AllReduce 大小策略；未设置时为 `256`。显式传入
`prefill_support=True` 的已有调用仍按 `max_size / 2` 检查。
ReduceScatter 和原先共用此筛选函数的融合入口保留原有64MiB限制；
AllGather的大小策略保持不变。

大小门限控制是否选择此后端，不代表所有输入都比NCCL更快。大输入基本
功能测试可在同节点IPC或超节点Fabric上执行，以下使用TP4：

```bash
python -B op_tests/multigpu_tests/test_custom_allreduce_size_limit.py --policy-only
AITER_AR_TRANSPORT=ipc HIP_VISIBLE_DEVICES=0,1,2,3 \
  torchrun --standalone --nproc-per-node=4 \
  op_tests/multigpu_tests/test_custom_allreduce_size_limit.py
```

默认覆盖FP16/BF16/FP32，1/56/64/84/112/168/256MiB输入，eager和Graph
copy-in各3次更换输入后比较全部元素；另检查256MiB以上、容量、布局等拒绝
条件。该测试直接调用AITER并断言返回有效输出，不通过框架回退到NCCL。

## 1. 通信模型：不依赖 MPI

本测试和 Aiter 超节点 `custom_all_reduce` 实现不依赖 MPI。

参考实现 `supernode_code` 使用 `mpirun`、
`MPI_Allgather` 和 `MPI_Barrier` 完成多进程启动、句柄交换和同步；Aiter
实现使用以下组件替代：

| 层次 | 当前实现 |
|---|---|
| 跨节点进程启动 | `torchrun` |
| rank、world size、rendezvous | `torch.distributed`、TCPStore |
| 初始化错误协同和测试结束同步 | `torch.distributed` collective |
| 跨节点内存导出/映射 | `hsa_ext_rpc_memory_create/attach/detach` |
| 实际 AllReduce 数据面 | Aiter CustomAllReduce HIP kernel |

因此，`torch.distributed` 主要承担控制面职责；待句柄交换和 peer 映射完成
后，输入张量的 AllReduce 不是通过 `dist.all_reduce` 或 MPI 完成，而是由
CustomAllReduce kernel 直接访问 Fabric 映射地址完成。

## 2. 目录文件说明

### `test_custom_allreduce_supernode.py`

多节点功能测试主体，可直接作为 `torchrun` 的入口，不依赖本目录中的
Shell runner。它会：

1. 从 `torchrun` 环境读取 `RANK`、`LOCAL_RANK` 和 `WORLD_SIZE`。
2. 使用 `env://` 初始化 Aiter/PyTorch 分布式环境和 TP group。
3. 检查 CustomAllReduce communicator 已创建且没有被禁用。
4. 断言实际选择的 transport 是预期的 `ipc` 或 `fabric`。
5. 主动禁用 QuickAllReduce，避免测试通过实际上来自 QR 或 PyNccl。
6. 令每个 rank 的输入值为 `rank + 1`；8/16/32/40 ranks时预期结果
   分别为 `36`、`136`、`528`、`820`。
7. 覆盖 eager 重复调用，并可选覆盖 HIP Graph copy-in 路径。
8. 所有 rank 通过后，由 rank 0 输出最终成功标志。

默认测试矩阵：

- dtype：`fp16`、`bf16`
- shape：`(2, 7168)`、`(128, 8192)`
- repeats：5
- Graph：默认关闭，传入 `--with-graph` 后开启

### Fabric Graph 注册回归

`check_custom_allreduce_graph_registration.py` 是不依赖 GPU、Torch 安装或
JIT 构建的控制流回归。它加载当前 communicator 源码，用桩替换 Torch 和
native 接口，检查 all-reduce、all-gather、reduce-scatter 及四个融合入口
在关闭直接注册时传递预注册 buffer 地址，同时检查 IPC 直接注册路径、
eager 路径、all-gather 预热形状和 Fabric 非空待注册队列的异常检查。

```bash
python -B op_tests/multigpu_tests/super_node/check_custom_allreduce_graph_registration.py
```

`test_custom_allreduce_graph_copyin.py` 用于真实 GPU Graph 回放。它直接调用
AITER，覆盖 all-reduce、首维/末维 all-gather、reduce-scatter、融合
all-reduce + RMSNorm；使用 FP16/BF16，每次回放更换输入并检查结果，且要求
捕获结束后的待注册地址数量为零。此测试支持总计 2、4、8 ranks，可通过
单节点或多节点 torchrun 启动；四卡模式对应 TP4/PP8 任务中的一个 TP 组。
输入形状为 `(2 * world_size, 512)`，满足融合 RMSNorm 对 FP16/BF16 的
最小宽度要求。

在包含本次修复的 AITER 环境中执行：

```bash
AITER_AR_TRANSPORT=fabric HIP_VISIBLE_DEVICES=0,1,2,3 \
  timeout --signal=TERM --kill-after=15s 180s \
  torchrun --standalone --nproc-per-node=4 \
  op_tests/multigpu_tests/super_node/test_custom_allreduce_graph_copyin.py \
  --transport fabric --repeats 3
```

改为 `--transport ipc` 可检查同节点 IPC copy-in 回放。测试会打印实际导入的
communicator 路径及 SHA256；各 rank、两种 dtype 均通过后，rank 0 输出
`CUSTOM_AR_GRAPH_COPYIN_PASS world_size=4 transport=fabric`。CPU 控制流检查
不能替代该 GPU 回放，也不能代替原 SGLang 模型的启动回归。

### `build_custom_allreduce_transport.sh`

聚焦构建并检查 `module_custom_all_reduce`。它不是跨节点通信依赖，而是
为了避免误用旧 JIT 模块，确保编译宏与预期一致。

```bash
bash op_tests/multigpu_tests/super_node/build_custom_allreduce_transport.sh
```

- 不传参数：默认按参数 `0` 构建IPC-only版本，与工程编译默认值一致。
- 参数 `1`：设置 `AITER_ENABLE_SUPERNODE_AR=1`，重新构建 Fabric 版本。
- 参数 `0`：构建不包含 HSA RPC 的 IPC-only 版本，用于兼容性回归。
- 脚本设置 `AITER_REBUILD=1`，强制重新检查/构建对应 JIT 模块。
- 宏开启时检查 Fabric feature 可用，IPC handle 为64字节，Fabric handle
  为256字节。
- 宏关闭时检查 Fabric feature 不可用，并确认 IPC handle 仍为64字节。

工程目录为共享挂载时，在一个节点构建一次即可；如果各节点使用不同
文件系统或不同 JIT 产物目录，则需要分别构建。

### `run_custom_allreduce_supernode_node.sh`

双节点 `torchrun` 的便捷封装，不是测试的强制依赖。其参数格式为：

```text
run_custom_allreduce_supernode_node.sh \
  <node-rank> <nnodes> <master-addr> <master-port> \
  <ipc|fabric|auto> [test args...]
```

脚本会自动：

- 根据脚本位置定位仓库根目录；
- 设置 `HIP_VISIBLE_DEVICES=0,1,2,3`；
- 设置 `AITER_AR_TRANSPORT`；
- 设置 `AITER_AR_ENABLE_REG_CAPTURE=0`，Fabric Graph 使用预注册 buffer
  的 copy-in 路径；
- 默认将 Gloo/RCCL 绑定到 `em1`；
- 设置 `NCCL_DEBUG=VERSION` 和 `TORCH_CPP_LOG_LEVEL=ERROR`，减少无关日志；
- 每节点启动4个进程；
- 使用300秒 watchdog；超时后先发送 `TERM`，15秒后仍未退出则强制终止；
- 将剩余参数原样传给 `test_custom_allreduce_supernode.py`。

### `run_custom_allreduce_supernode_4nodes.sh`

四节点16-rank专用封装。它固定 `nnodes=4`，调用通用runner，并自动向测试
传入 `--expect-world-size 16 --dist-backend gloo --direct-custom-ar`。该模式使用
Gloo交换Fabric句柄，直接构造并验证CustomAllreduce后端，避免16-rank验收被
模型并行初始化中的其他communicator阻塞。

```text
run_custom_allreduce_supernode_4nodes.sh \
  <node-rank:0..3> <master-addr> <master-port> \
  <ipc|fabric|auto> [test args...]
```

参与节点依次使用node rank `0`～`3`。

### `run_custom_allreduce_supernode_8nodes.sh`

八节点32-rank专用封装，固定 `nnodes=8`、每节点4进程，并自动传入
`--expect-world-size 32 --dist-backend gloo --direct-custom-ar`。参与节点依次
使用node rank `0`～`7`。默认watchdog延长到600秒，直接CA的注册数据区为8 MiB。

### `run_custom_allreduce_supernode_10nodes.sh`

十节点40-rank专用封装，参数和32-rank脚本相同，参与节点依次使用node rank
`0`～`9`，并断言world size为40。运行前必须确认10个节点的HCU设备和负载满足
测试条件。

### `benchmark_custom_allreduce_supernode.py`

独立的跨节点性能测试入口，不改变功能测试的PASS语义。它直接构造Fabric
`CustomAllreduce`，并可创建RCCL process group作为基线。默认测试fp16的
16/64/256/1024/2048/4096 KiB消息，每个尺寸warmup 10次、计时50次。

计时使用每个rank上的HIP Event；汇总时以同一次迭代所有rank的最大耗时作为
集体通信关键路径延迟，输出mean、p50、p95和最小延迟。带宽口径为：

```text
AlgBW = message_bytes / mean_latency
BusBW = AlgBW * 2 * (ranks - 1) / ranks
mean/p50/p95_speedup_vs_rccl = 对应RCCL延迟 / 对应CustomAR延迟
```

该脚本先对CustomAR和RCCL分别做一次数值校验，再开始计时。最终成功标志为
`SUPERNODE_CUSTOM_AR_PERF_PASS`。

### `run_custom_allreduce_supernode_perf.sh`

8/16/32 ranks通用性能runner。参数格式为：

```text
run_custom_allreduce_supernode_perf.sh \
  <node-rank> <nnodes:2|4|8> <master-addr> <master-port> [benchmark args...]
```

脚本固定每节点4进程、Fabric transport、Gloo控制面和900秒watchdog，并把
`nnodes*4`作为预期world size传给性能入口。可用`--mode custom|rccl|both`、
`--dtype`、重复的`--size-kib`、`--warmup`和`--iters`调整矩阵。

如果通信接口不是 `em1`，可在启动前设置：

```bash
# 示例：实际接口为 eth0
export AITER_SUPERNODE_IFACE=eth0
```

### `check_custom_allreduce_transport_env.py`

轻量检查运行时 transport 环境变量解析：

- 未设置 `AITER_AR_TRANSPORT` 时默认值必须为 `ipc`；
- 非法值必须抛出异常，并提示合法值为 `ipc|fabric|auto`。

运行方法：

```bash
python op_tests/multigpu_tests/super_node/check_custom_allreduce_transport_env.py
```

成功输出：

```text
CUSTOM_AR_TRANSPORT_ENV_PASS default=ipc invalid=rejected
```

### `final_verify_custom_allreduce.sh`

开发期最终检查脚本，不是功能测试的启动依赖。它会：

- 输出本次改造关键文件的 SHA256；
- 检查 `module_custom_all_reduce.so` 是否解析到 `libhsa-runtime64`；
- 输出当前 HCU 使用率和显存状态。

应在 Fabric 宏开启并完成 JIT 构建后运行：

```bash
bash op_tests/multigpu_tests/super_node/final_verify_custom_allreduce.sh
```

## 3. transport 语义

| transport | 行为 |
|---|---|
| `ipc` | 沿用原有单节点 HIP IPC；跨物理节点不使用 Fabric |
| `fabric` | 强制使用 HSA RPC Fabric；未编译或初始化失败时明确报错 |
| `auto` | 同节点选择 IPC；跨节点在已编译 Fabric feature 时选择 Fabric，初始化失败时按上层契约回退 |

默认编译不启用Fabric能力，也不链接HSA runtime；默认运行时transport仍是
`ipc`。需要超节点Fabric时，必须在JIT构建/重建前显式设置
`AITER_ENABLE_SUPERNODE_AR=1`，或使用本目录构建脚本的参数 `1`。

注意：在一个已经构建完成的 `.so` 上临时修改
`AITER_ENABLE_SUPERNODE_AR` 不会改变该模块；该变量必须在JIT构建/重建时
生效。

## 4. 多节点复现前检查

### 4.1 确认代码和运行环境

所有参与节点必须看到同一版本的源码和JIT产物，并从 `aiter` 工程根目录执行
后续命令：

```bash
cd aiter
git rev-parse HEAD
```

### 4.2 检查各节点 HCU 和设备透传

所有参与节点分别执行：

```bash
rocm-smi --showuse --showmemuse
```

测试会占用每个节点的4张卡，不要与其他多卡任务同时运行。运行环境必须存在
`/dev/kfd` 和4个render节点；若 `torch.cuda.device_count()` 虽然为4但设备
初始化报 `No HIP GPUs are available`，说明HCU设备不可用，不能继续启动
`torchrun`。

### 4.3 获取master节点地址

在node rank 0所在节点执行：

```bash
IFACE="${AITER_SUPERNODE_IFACE:-em1}"
ip -4 -o addr show "${IFACE}"
```

将查询到的地址设置为 `MASTER_ADDR`，并在其余参与节点确认能够访问：

```bash
export MASTER_ADDR=master-node-address
ping -c 2 "${MASTER_ADDR}"
```

## 5. 构建 Fabric 版本

推荐使用聚焦构建脚本。在共享工程根目录执行一次：

```bash
cd aiter
bash op_tests/multigpu_tests/super_node/build_custom_allreduce_transport.sh 1
```

预期输出包含：

```text
CUSTOM_AR_BUILD ... fabric_available=True ipc_handle_size=64
CUSTOM_AR_BUILD fabric_handle_size=256
```

如果不使用构建脚本，等价的直接检查方式是：

```bash
cd aiter

export AITER_ENABLE_SUPERNODE_AR=1
AITER_REBUILD=1 python - <<'PY'
from aiter.ops import custom_all_reduce as ops

print("fabric_available:", ops.fabric_ar_available())
print("ipc_handle_size:", ops.ar_handle_size(0))
print("fabric_handle_size:", ops.ar_handle_size(1))
assert ops.fabric_ar_available()
assert ops.meta_size() == 25984
assert ops.ar_handle_size(0) == 64
assert ops.ar_handle_size(1) == 256
PY
```

## 6. 推荐流程：直接使用 torchrun

以下流程不依赖 `run_custom_allreduce_supernode_node.sh`。

### 6.1 先跑最小 Fabric 冒烟测试

在两个参与节点分别进入工程目录，并设置相同的公共环境：

```bash
cd aiter
export HIP_VISIBLE_DEVICES=0,1,2,3
export AITER_AR_TRANSPORT=fabric
export AITER_AR_ENABLE_REG_CAPTURE=0
export GLOO_SOCKET_IFNAME=em1
export NCCL_SOCKET_IFNAME=em1
export PYTHONUNBUFFERED=1
```

先在第一个节点启动node rank 0：

```bash
timeout --signal=TERM --kill-after=15s 300s \
torchrun \
  --nnodes=2 \
  --nproc-per-node=4 \
  --node-rank=0 \
  --master-addr="${MASTER_ADDR}" \
  --master-port=29612 \
  op_tests/multigpu_tests/super_node/test_custom_allreduce_supernode.py \
  --transport fabric \
  --shape 2,7168 \
  --dtype fp16 \
  --repeats 2
```

随后立即在第二个节点启动node rank 1：

```bash
timeout --signal=TERM --kill-after=15s 300s \
torchrun \
  --nnodes=2 \
  --nproc-per-node=4 \
  --node-rank=1 \
  --master-addr="${MASTER_ADDR}" \
  --master-port=29612 \
  op_tests/multigpu_tests/super_node/test_custom_allreduce_supernode.py \
  --transport fabric \
  --shape 2,7168 \
  --dtype fp16 \
  --repeats 2
```

两端的 `master-addr`、`master-port`、`nnodes` 必须一致，只有
`node-rank` 不同。

### 6.2 运行完整 dtype/shape/Graph 矩阵

冒烟通过后换一个空闲端口，例如 `29613`。不传 `--shape` 和 `--dtype`
时会使用默认的两种 dtype 和两个 shape。

第一个节点：

```bash
timeout --signal=TERM --kill-after=15s 300s \
torchrun \
  --nnodes=2 --nproc-per-node=4 --node-rank=0 \
  --master-addr="${MASTER_ADDR}" --master-port=29613 \
  op_tests/multigpu_tests/super_node/test_custom_allreduce_supernode.py \
  --transport fabric --repeats 2 --with-graph
```

第二个节点：

```bash
timeout --signal=TERM --kill-after=15s 300s \
torchrun \
  --nnodes=2 --nproc-per-node=4 --node-rank=1 \
  --master-addr="${MASTER_ADDR}" --master-port=29613 \
  op_tests/multigpu_tests/super_node/test_custom_allreduce_supernode.py \
  --transport fabric --repeats 2 --with-graph
```

### 6.3 四节点16卡测试

四个节点依次使用node rank `0`、`1`、`2`、`3`。下面使用node rank 0所在
节点的地址作为master，并使用端口 `29630`。

四个节点都先设置：

```bash
cd aiter
export HIP_VISIBLE_DEVICES=0,1,2,3
export AITER_AR_TRANSPORT=fabric
export AITER_AR_ENABLE_REG_CAPTURE=0
export GLOO_SOCKET_IFNAME=em1
export NCCL_SOCKET_IFNAME=em1
export PYTHONUNBUFFERED=1
```

node rank 0所在节点执行：

```bash
timeout --signal=TERM --kill-after=15s 300s \
torchrun --nnodes=4 --nproc-per-node=4 --node-rank=0 \
  --master-addr="${MASTER_ADDR}" --master-port=29630 \
  op_tests/multigpu_tests/super_node/test_custom_allreduce_supernode.py \
  --transport fabric --expect-world-size 16 \
  --dist-backend gloo --direct-custom-ar \
  --shape 2,7168 --dtype fp16 --repeats 2
```

其余三个节点执行同一命令，只把 `--node-rank` 分别改为 `1`、`2`、`3`。
四条命令应在300秒内全部启动。

### 6.4 八节点32卡与十节点40卡测试

32-rank测试使用8个节点，node rank依次为0～7。先在任一共享节点显式构建
Fabric模块，再确认8个节点均能看到同一新 `.so`：

```bash
cd aiter
bash op_tests/multigpu_tests/super_node/build_custom_allreduce_transport.sh 1
```

八个节点使用同一个master地址和端口并近同时启动；推荐直接使用下一节的
8节点专用runner。40-rank流程完全相同，但增加2个节点，并使用node rank
8/9。若任一节点存在计算任务或HCU设备不可用，不应启动多节点测试。

## 7. 使用便捷 runner 复现

便捷 runner 与上一节的直接 `torchrun` 等价，只是封装了环境变量、每节点
4进程和 watchdog。

第一个节点：

```bash
bash op_tests/multigpu_tests/super_node/run_custom_allreduce_supernode_node.sh \
  0 2 "${MASTER_ADDR}" 29614 fabric --repeats 2 --with-graph
```

第二个节点：

```bash
bash op_tests/multigpu_tests/super_node/run_custom_allreduce_supernode_node.sh \
  1 2 "${MASTER_ADDR}" 29614 fabric --repeats 2 --with-graph
```

如果需要仅运行小shape冒烟，可在两个节点分别设置node rank 0和1：

```bash
NODE_RANK=0
bash op_tests/multigpu_tests/super_node/run_custom_allreduce_supernode_node.sh \
  "${NODE_RANK}" 2 "${MASTER_ADDR}" 29615 fabric \
  --shape 2,7168 --dtype fp16 --repeats 2
```

四节点也可以使用专用runner。四台机器分别执行，`NODE_RANK` 依次设为
0、1、2、3：

```bash
NODE_RANK=0
bash op_tests/multigpu_tests/super_node/run_custom_allreduce_supernode_4nodes.sh \
  "${NODE_RANK}" "${MASTER_ADDR}" 29631 fabric \
  --shape 2,7168 --dtype fp16 --repeats 2
```

八节点32-rank冒烟测试：在8个节点分别执行同一命令，只把 `NODE_RANK` 设为
0～7。`MASTER_ADDR` 必须填写node rank 0所在节点的通信地址：

```bash
NODE_RANK=0
MASTER_ADDR=master-node-address
bash op_tests/multigpu_tests/super_node/run_custom_allreduce_supernode_8nodes.sh \
  "${NODE_RANK}" "${MASTER_ADDR}" 29640 fabric \
  --shape 2,7168 --dtype fp16 --repeats 2
```

十节点40-rank入口：在10个节点分别把 `NODE_RANK` 设为0～9，所有节点使用
相同master地址和端口：

```bash
NODE_RANK=0
MASTER_ADDR=master-node-address
bash op_tests/multigpu_tests/super_node/run_custom_allreduce_supernode_10nodes.sh \
  "${NODE_RANK}" "${MASTER_ADDR}" 29641 fabric \
  --shape 2,7168 --dtype fp16 --repeats 2
```

## 8. 验证 auto 模式

跨节点 `auto` 应实际选择 `fabric`。以下双节点回归使用相同的新端口：

第一个节点：

```bash
bash op_tests/multigpu_tests/super_node/run_custom_allreduce_supernode_node.sh \
  0 2 "${MASTER_ADDR}" 29616 auto \
  --shape 2,7168 --dtype fp16 --repeats 2
```

第二个节点：

```bash
bash op_tests/multigpu_tests/super_node/run_custom_allreduce_supernode_node.sh \
  1 2 "${MASTER_ADDR}" 29616 auto \
  --shape 2,7168 --dtype fp16 --repeats 2
```

测试会断言最终 `ca.transport == "fabric"`，因此不会把错误的 fallback 当作
成功。

## 9. 单节点 IPC 回归

Fabric 宏开启时仍可验证原有 IPC 分支。只在一台4卡节点上执行：

```bash
cd aiter
export HIP_VISIBLE_DEVICES=0,1,2,3
export AITER_AR_TRANSPORT=ipc
export AITER_AR_ENABLE_REG_CAPTURE=0

torchrun \
  --standalone \
  --nproc-per-node=4 \
  op_tests/multigpu_tests/super_node/test_custom_allreduce_supernode.py \
  --transport ipc \
  --expect-transport ipc \
  --shape 2,7168 \
  --dtype fp16 \
  --repeats 2 \
  --with-graph
```

验证默认宏关闭构建时可执行：

```bash
bash op_tests/multigpu_tests/super_node/build_custom_allreduce_transport.sh
```

宏关闭回归完成后，如还要继续运行跨节点 Fabric 测试，必须重新执行：

```bash
bash op_tests/multigpu_tests/super_node/build_custom_allreduce_transport.sh 1
```

单节点验证 `auto` 时会选择 IPC，需要显式指定预期 transport：

```bash
torchrun --standalone --nproc-per-node=4 \
  op_tests/multigpu_tests/super_node/test_custom_allreduce_supernode.py \
  --transport auto --expect-transport ipc \
  --shape 2,7168 --dtype fp16 --repeats 2
```

## 10. 成功判据

每个测试组合都会输出类似：

```text
rank=3 transport=fabric dtype=torch.float16 shape=(2, 7168) repeats=2 graph=False PASS
```

完整测试成功必须同时满足：

1. 所有参与ranks都输出对应组合的 `PASS`（32卡为0～31，40卡为0～39）；
2. 所有参与节点的 `torchrun` 都以退出码0结束；
3. rank 0 输出：

```text
SUPERNODE_CUSTOM_AR_PASS world_size=8 transport=fabric
```

四节点16卡测试对应的最终标志为：

```text
SUPERNODE_CUSTOM_AR_PASS world_size=16 transport=fabric
```

32/40卡测试的最终标志分别为：

```text
SUPERNODE_CUSTOM_AR_PASS world_size=32 transport=fabric
SUPERNODE_CUSTOM_AR_PASS world_size=40 transport=fabric
```

四节点直接CA模式不构造QuickAllReduce/PyNccl，并断言实际CustomAllreduce
transport；双节点高层模式也会禁用QR。因此该标志不能由其他通信路径产生。

## 11. 测试参数

```bash
python op_tests/multigpu_tests/super_node/test_custom_allreduce_supernode.py --help
```

| 参数 | 作用 |
|---|---|
| `--transport ipc|fabric|auto` | 请求的运行时 transport |
| `--shape M,N` | 指定 shape，可重复传入以测试多个 shape |
| `--dtype fp16|bf16|fp32` | 指定 dtype，可重复传入 |
| `--repeats N` | 每个 dtype/shape 的 eager 重复次数，必须大于0 |
| `--with-graph` | 额外执行一次 HIP Graph capture/replay |
| `--dist-backend nccl|gloo` | 指定torch.distributed控制面；四节点直接CA使用gloo |
| `--direct-custom-ar` | 跳过模型并行communicator，直接构造并验证CustomAllreduce后端 |
| `--direct-max-size-mib N` | 直接CA模式的注册input/temp buffer大小；默认8 MiB |
| `--direct-max-size-kib N` | 以KiB覆盖直接CA buffer，供极小shape资源受限冒烟使用 |
| `--expect-transport ipc|fabric` | 覆盖实际 transport 断言，主要用于单节点 `auto` |
| `--expect-world-size N` | 断言全局rank数；8/16/32/40分别对应2/4/8/10个四卡节点 |

普通 CustomAllReduce all-reduce 接口当前接受world size
`2、4、6、8、16、32、40`。各便捷runner固定每节点4进程。
FP8量化以及reduce-scatter/all-gather等融合路径仍有独立的rank数限制。本目录
16/32/40卡用例只验证普通CustomAllreduce后端；高层 `tensor_model_parallel_all_reduce`
和Graph兼容性由8-rank双节点回归覆盖。

最大容量扩到40后不会按40 ranks额外分配一套大buffer：`rank_data`仍固定为
8 MiB，`input`和临时数据仍由 `max_size` 决定。固定Signal metadata为25984
字节，比16槽位版本增加15360字节/rank；RankData每条记录由128增至320字节，
8 MiB池容量由65536降为26214条，仍高于已观察到的10000以下需求。handle交换
和peer映射仍按实际world size执行。直接CA测试默认 `max_size=8 MiB`，因此每
rank的三块数据区共24 MiB，另加固定8 MiB RankData；可用参数显式调大。

32可整除kernel固定的512线程，沿用优化分派；40不能整除512，为避免尾部线程
产生越界rank索引，普通all-reduce在40 ranks时固定使用naive 2-stage kernel。
这保证功能安全，但40-rank性能需要单独评估。

### 性能验证边界

功能测试PASS仍只代表正确性，不能作为性能结论。性能必须使用独立的
`benchmark_custom_allreduce_supernode.py`；它包含warmup、HIP Event计时、跨rank
关键路径汇总、分位数、有效带宽和RCCL基线。结果仍会受到同时运行的其他任务、
Fabric拓扑、IOMMU配置、频率和温度影响，正式结论应保留完整命令与运行负载。

### 8-rank Fabric 的 block 上限

在DTK构建、Fabric transport、8 ranks且消息大小为4～8 MiB时，当前实现会根据
双节点实测结果把默认launch上限从80 blocks调整为48。其他消息大小、IPC、非
8-rank和非DTK路径仍保持原80上限。

正常使用不需要设置额外环境变量。诊断或回退时可显式设置：

```bash
# 完全恢复优化前的80-block launch行为
export AITER_AR_BLOCK_LIMIT=80
```

`AITER_AR_BLOCK_LIMIT`合法范围为1～80，且只覆盖上述DTK Fabric 8-rank路径；
非法值会直接报错。该变量主要用于性能A/B和现场回退，不建议在未按消息区间
复测时把其他值作为通用配置。

## 12. 性能测试与记录

### 12.1 测试口径

每个节点固定4个进程，8/16/32 ranks分别使用2/4/8个节点。所有节点执行同一
runner，只修改`NODE_RANK`；正式记录建议至少3个独立轮次、每轮warmup 20、
计时200次：

```bash
bash op_tests/multigpu_tests/super_node/run_custom_allreduce_supernode_perf.sh \
  "${NODE_RANK}" "${NUM_NODES}" "${MASTER_ADDR}" "${MASTER_PORT}" \
  --mode both --dtype fp16 --rccl-semantics both \
  --warmup 20 --iters 200 \
  --size-kib 16 --size-kib 64 --size-kib 256 \
  --size-kib 1024 --size-kib 2048 --size-kib 4096
```

`CustomAllreduce`保留输入并返回独立输出。RCCL保留两种对照：

- `in-place`：`dist.all_reduce(inp)`，代表RCCL原语下界；
- `out-of-place`：`result=inp.clone()`后执行all-reduce，与CustomAR的接口语义更接近。

延迟样本取每次迭代所有ranks中的最大HIP Event时间；表中数值是每轮p50再取
跨轮中位。速度比定义为`RCCL p50 / CustomAR p50`，大于1表示CustomAR更快。
有效记录必须满足所有节点退出码为0、每条结果包含指定数量的原始样本，并输出
`SUPERNODE_CUSTOM_AR_PERF_PASS`。

### 12.2 多轮双口径结果

8-rank记录：2节点、fp16、每个尺寸200次、3轮。

| 消息 | CustomAR p50 (us) | RCCL in-place p50 (us) | in-place速度比 | RCCL out-of-place p50 (us) | out-of-place速度比 |
|---:|---:|---:|---:|---:|---:|
| 4 KiB | 139.039 | 125.439 | 0.902 | 157.599 | 1.133 |
| 8 KiB | 145.199 | 103.840 | 0.715 | 161.119 | 1.110 |
| 16 KiB | 154.639 | 127.680 | 0.826 | 161.759 | 1.046 |
| 32 KiB | 153.919 | 127.519 | 0.828 | 160.879 | 1.045 |
| 48 KiB | 154.639 | 127.919 | 0.827 | 161.919 | 1.047 |
| 64 KiB | 152.479 | 127.679 | 0.837 | 162.639 | 1.067 |
| 80 KiB | 151.919 | 127.600 | 0.840 | 158.399 | 1.043 |
| 96 KiB | 151.039 | 127.679 | 0.845 | 147.839 | 0.979 |
| 128 KiB | 141.839 | 120.799 | 0.852 | 148.159 | 1.045 |
| 192 KiB | 144.959 | 121.919 | 0.841 | 149.439 | 1.031 |
| 256 KiB | 142.879 | 110.080 | 0.770 | 137.119 | 0.960 |
| 512 KiB | 143.199 | 158.559 | 1.107 | 185.119 | 1.293 |
| 1 MiB | 140.799 | 159.199 | 1.131 | 186.719 | 1.326 |
| 2 MiB | 153.519 | 166.479 | 1.084 | 192.959 | 1.257 |

16-rank记录：4节点、fp16、每个尺寸200次、3轮。

| 消息 | CustomAR p50 (us) | RCCL in-place p50 (us) | in-place速度比 | RCCL out-of-place p50 (us) | out-of-place速度比 |
|---:|---:|---:|---:|---:|---:|
| 16 KiB | 170.960 | 140.959 | 0.825 | 150.559 | 0.881 |
| 64 KiB | 162.799 | 146.000 | 0.897 | 172.559 | 1.060 |
| 256 KiB | 165.359 | 150.479 | 0.910 | 176.479 | 1.067 |
| 1 MiB | 160.719 | 178.240 | 1.109 | 198.478 | 1.235 |
| 2 MiB | 175.920 | 209.198 | 1.189 | 235.599 | 1.339 |
| 4 MiB | 244.479 | 280.958 | 1.149 | 320.559 | 1.311 |

16 KiB独立复测：相同4节点、fp16、warmup 20、每个后端200次、3轮。

| 记录 | CustomAR p50 (us) | RCCL in-place p50 (us) | in-place速度比 | RCCL out-of-place p50 (us) | out-of-place速度比 |
|---|---:|---:|---:|---:|---:|
| 首测 | 170.960 | 140.959 | 0.825 | 150.559 | 0.881 |
| 独立复测 | 173.599 | 139.999 | 0.806 | 173.039 | 0.997 |

16 KiB复测三轮的out-of-place速度比分别为`0.964/1.001/0.953`；合并首测与
复测共6轮后，逐轮速度比中位为`0.946`，CustomAR在5/6轮更慢。结论是
CustomAR在16 KiB没有证明优于out-of-place RCCL，整体方向偏慢；复测中位只
慢0.560 us，差距幅度接近噪声，不能表述为稳定的大幅落后。

### 12.3 历史原地RCCL参考

以下为引入双语义测试前的单轮50次记录，仅用于保留原地RCCL历史参考：

| ranks | 消息 | CustomAR p50 (us) | RCCL p50 (us) | p50速度比 |
|---:|---:|---:|---:|---:|
| 8 | 16 KiB | 141.920 | 130.799 | 0.922 |
| 8 | 64 KiB | 160.319 | 132.319 | 0.825 |
| 8 | 256 KiB | 158.319 | 130.240 | 0.823 |
| 8 | 1 MiB | 159.279 | 174.079 | 1.093 |
| 8 | 2 MiB | 165.919 | 182.559 | 1.100 |
| 8 | 4 MiB | 213.839 | 194.799 | 0.911 |
| 16 | 16 KiB | 156.799 | 150.879 | 0.962 |
| 16 | 64 KiB | 172.879 | 151.040 | 0.874 |
| 16 | 256 KiB | 168.159 | 158.480 | 0.942 |
| 16 | 1 MiB | 157.999 | 181.679 | 1.150 |
| 16 | 2 MiB | 179.119 | 214.319 | 1.197 |
| 16 | 4 MiB | 233.119 | 269.038 | 1.154 |
| 32 | 16 KiB | 145.599 | 138.719 | 0.953 |
| 32 | 64 KiB | 159.520 | 172.319 | 1.080 |
| 32 | 256 KiB | 165.679 | 184.159 | 1.112 |
| 32 | 1 MiB | 169.119 | 217.119 | 1.284 |
| 32 | 2 MiB | 181.519 | 245.678 | 1.353 |
| 32 | 4 MiB | 232.239 | 310.558 | 1.337 |

性能判断优先采用12.2节的多轮双口径记录；本表不能解释为out-of-place公平
对比。长尾判断需要同时查看JSON中的mean、p50、p95和p99。

## 13. 常见问题

### `fabric_available=False`

当前加载的是 IPC-only 或旧 JIT 模块。执行：

```bash
bash op_tests/multigpu_tests/super_node/build_custom_allreduce_transport.sh 1
```

确认输出包含 `fabric_available=True` 和 `fabric_handle_size=256`。

### `Address already in use`

当前 master port 被占用。为所有参与节点同时更换为同一个新端口。

### 一直等待 rendezvous

检查：

- 所有节点的命令是否都已启动；
- 所有节点的 `--master-addr`、`--master-port` 是否完全一致；
- 四个节点是否依次使用 `--node-rank=0/1/2/3`；
- `master-addr` 是否为node rank 0所在节点的通信地址；
- 其他节点是否能够访问该地址和端口。

### runner 退出码为 `124`

300秒 watchdog 已触发。常见原因包括另一节点没有启动、网络接口不通，或
Fabric peer barrier/kernel 卡住。不要立即重复运行；先检查两端最后日志和
GPU进程状态。

### `CustomAllreduce communicator was not created` 或 `disabled`

检查 Fabric 模块是否已正确构建、当前进程是否加载了预期 `.so`、world size
是否受支持，以及显式 `fabric` 初始化前各 rank 是否都成功创建/交换 handle。

### `expected selected transport=...`

测试发现实际选择的 transport 与预期不一致。跨节点 `auto` 应为 `fabric`；
单节点 `auto` 应传 `--expect-transport ipc`。

### HSA状态4104或4097

- `4104` 是 `HSA_STATUS_ERROR_OUT_OF_RESOURCES`。即使HCU计算为0%，较高显存
  占用或既有Fabric映射仍可能让32-rank peer attach失败；不要停止他人进程，
  应换空闲节点或等待资源释放。
- `4097` 是 `HSA_STATUS_ERROR_INVALID_ARGUMENT`。本环境中64 KiB input buffer
  无法导出；小shape诊断应至少使用 `--direct-max-size-mib 1`。

### RCCL/IOMMU/xHCL 警告

运行中可能出现 `iommu=pt`、`HSA_FORCE_FINE_GRAIN_PCIE` 或 remote BDF
相关警告。应先区分警告和最终失败：只有所有 rank 数值正确且出现最终成功
标志，才能判定本次功能测试通过。这些平台配置不能由测试脚本自动修改。

## 14. 测试后检查

所有参与节点测试结束后分别执行：

```bash
rocm-smi --showuse --showmemuse
```

确认本次所有参与节点的 HCU 计算占用已释放。如果需要检查最终模块链接和关键
文件摘要，可运行：

```bash
bash op_tests/multigpu_tests/super_node/final_verify_custom_allreduce.sh
```
