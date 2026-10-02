# 经验加载与冻结评测

## 参考依据（2026-10-02核对一手资料）

- RoboDawn `harness/agent/memory.py`：https://github.com/Hugo-AGI/RoboDawn/blob/main/harness/agent/memory.py 。`AgentMemory`分别维护最近12轮的压缩历史、模型自写scratchpad（2500字符上限）和planner_failures；`render()`将历史/笔记插入提示。该源码不能支持“自动跨任务Markdown检索”这样的额外主张。
- Harness VLA官方页面：https://harnessvla.github.io/ 。Task Specific Memory保存成功的primitive结构；Global Memory保存成功规则与失败模型；reference-seed bootstrapping与冻结evaluation分开，运行时根据新RGB-D重新绑定实体和目标，不照抄旧场景坐标。

## 本仓库实现（借鉴分层，不是原论文完整复现）

1. `global/`：跨任务候选原则。目前只有观测可信度、身份关联、验证规则，没有证明其跨任务有效。
2. `tasks/`：结构与适用假设、经验参数。当前适配器只支持pick_lift；数值经验没有伪装为通用算法。
3. `archive/`：反例、撤销规则，不进入运行时加载。
4. 每回合创建`experience_snapshot.json`冻结完整内容和SHA256；每步按kind/stage确定性检索最多3条；真正Jev请求中保留`experience_memory`。不使用额外LLM检索，避免额外模型费用。
5. `experience_usage.jsonl`记录每步加载条目；`episode_notes.md`记录阶段与执行/停止事实。没有声称这些笔记是Jev生成的自由思考。
6. 离线`code/scripts/summarize_experience.py`将完整回合总结为`status=candidate`的Markdown。候选不自动写回active，不改变同批评测；后续人工/Agent证据审阅才可激活。

Markdown的JSON块是可验证元数据，不是任意可执行代码；任务经验参数必须通过范围检查。Global文本作为历史提示，不优先于当前观测，也不能读隐藏状态。

## 四回合冻结口径

RoboDojo general_pickup布局0、1、2、3，各1次，同代码、同经验文件、200原生步预算；不因失败改提示或重跑。它们是已见过的开发布局，结果不是独立泛化测试。

本次撤销最近同名目标选择及lift特殊放宽；保留固定视觉抓取参考与最多一次重试，但4mm偏移/55mm接近/8mm重试移入task经验并明示适用限制。控制器基类仍是已有阶段程序；本次完成的是经验和执行分层，不是把所有任务阶段自动泛化。

## 可复现总结命令

下面是一行命令，无需拆行；仅在四回合完成并备份到本地后执行，输出文件须不存在。

```bash
python3 code/scripts/summarize_experience.py --runs code/runs/memory-eval4-0 code/runs/memory-eval4-1 code/runs/memory-eval4-2 code/runs/memory-eval4-3 --output code/experience/candidates/memory-eval4.md
```
