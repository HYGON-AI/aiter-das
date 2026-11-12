# 索引 TopK 的 gfx946 验证

本目录的三个脚本覆盖四个索引选择接口；`test_moe_topk.py` 属于另一组 MoE 路由算子，不作为本次索引测试。

| 脚本 | 公共接口 | 完整矩阵 |
|---|---|---|
| `test_kpool_topk.py` | `kpool_topk` | 6例：pool16/pool4优化分支、通用与强制回退、页表/行映射、offset、非零起点、短/空行、尾 token、输出补行 |
| `test_topk_per_row.py` | `top_k_per_row_prefill`、`top_k_per_row_decode` | 7例：prefill indices-only/values、4096-bin 分支；decode next_n=1/2/3/4 |
| `test_topk_plain.py` | `topk_plain` | 8例：FP32/FP16/BF16、最大/最小、K=1、并列值、Sort/Radix、Radix变长行 |

脚本及 `_index_topk_common.py` 都是永久测试文件，只依赖 Torch、AITER 和标准库。脚本强制导入所在 checkout，支持从其他工作目录启动；`--list` 不初始化 GPU。每例只调用一次算子，无预热/计时循环，最大输入为2×8192元素。CPU 参考检查索引范围、去重、TopK分数集合及值与索引逐项配对；per-row/plain 检查输出两端保护区。kpool 比较展开、映射后的完整 token 集合及补行。

## 构建和运行

在已配置的 Perf Model 容器内，将 `AITER_REPO` 设为本次源码根目录：

```bash
export ROCM_PATH=/opt/rocm PMD_PATH=/opt/rocm/pmd GPU_ARCHS=gfx946
export HIP_CLANG_PATH=/wksp/llvm-project/build-6.3.3/bin
export PATH=/opt/rocm/bin:$HIP_CLANG_PATH:/opt/hyhal/bin:$PATH
export LD_LIBRARY_PATH=/opt/rocm/lib:/opt/rocm/pmd:${LD_LIBRARY_PATH:-}
export PYTHONPATH="$AITER_REPO" AITER_ENABLE_SUPERNODE_AR=0
export GPU_ARGS="['--num-gpu=1']" GPU_DFLAGS="['StatLog']"
unset AITER_JIT_DIR AITER_REBUILD HIP_VISIBLE_DEVICES ROCR_VISIBLE_DEVICES CUDA_VISIBLE_DEVICES
test_root="$AITER_REPO/op_tests/gfx946_tests/moe_topk"
GPU_CHIP=sb python "$test_root/test_kpool_topk.py" --suite build --rebuild --json build_pool.json
GPU_CHIP=sb python "$test_root/test_topk_per_row.py" --suite build --rebuild --json build_row.json
GPU_CHIP=sb python "$test_root/test_topk_plain.py" --suite build --rebuild --json build_plain.json
```

每个运行使用独立当前目录保存 `m5out`，避免统计覆盖。以下命令以 kpool 为例，另外两个脚本使用相同参数：

```bash
GPU_CHIP=sb python "$test_root/test_kpool_topk.py" --suite all --expect-xcds 1 --json single.json
GPU_CHIP=sbx2 python "$test_root/test_kpool_topk.py" --suite all --expect-xcds 2 --json dual.json
GPU_CHIP=sbx2 python "$test_root/test_kpool_topk.py" --suite route --expect-xcds 2 --die-mode linear --chunk 2 --json linear2.json
GPU_CHIP=sbx2 python "$test_root/test_kpool_topk.py" --suite route --expect-xcds 2 --die-mode off --json off.json
```

`quick` 执行少量默认用例；`full` 执行全部数值用例；`all` 额外检查启动配置拒绝；`config` 只检查配置拒绝；`route` 选择多个 workgroup 的代表用例；`build` 只构建/加载，不发射 TopK kernel。支持 `--case NAME` 指定单例；per-row 可用 `--ops prefill` 或 `--ops decode` 分开运行。

## 单/多 die 判定

初始化后检查 HIP 架构、一个可见 GPU 和 HSA 报告的 XCD 数，`--expect-xcds` 必须一致；随后移除 `GPU_CHIP`，launcher 继续依靠设备拓扑选择路径。`sb` 的1 XCD对应单 die 模型；`sbx2` 为一张 GPU的2 XCD，不能用设备数量或CU数替代XCD查询。

量化之外的启动配置各有前缀：kpool 为 `SGL_KERNEL_KPOOL_TOPK`，per-row 为 `AITER_TOPK_PER_ROW`；plain 的 Sort 使用 `AITER_TOPK_PLAIN`，共享 Radix 使用 `AITER_TOPK_PER_ROW`。测试会同步设置相关前缀的 `DIE_MODE/CHUNK/MASK/LOG_LAUNCH`，分别测试实际分支的配置拒绝。

数值通过与 launcher 的 linear 日志不能单独证明两个 XCD 都执行了工作；须以 `DUT_BEGIN/END`、AQL dispatch ID及 `m5out/0/<id>/stats.txt` 的 `completedWGs` 对照。`off` 仅选择普通启动API，不能称为单 die模式。

结果JSON记录实际包路径、模块/SO哈希、源码/测试哈希、逐例输入和输出哈希；仅全部完成时标为 `PASS`。中断时保留 `RUNNING` 和已完成用例，不能计为全通过。比较索引哈希时注意并列分数可有不同合法选择，以数值检查为验收标准。

本矩阵不声称穷尽长序列拆分、Filter/Merge、任意stride、所有dtype/参数组合，也不包含 Graph 或性能验收。Perf Model墙钟时间不能作为GPU性能。需要覆盖具体框架shape时再添加对应的受控用例。
