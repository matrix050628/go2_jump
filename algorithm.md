# Go2 前跳算法说明

本文说明当前仓库中前跳算法的设计思路，重点回答三个问题：

1. `planner` 在算什么
2. `controller` 在算什么
3. `WBC` 在算什么

这份文档对应当前代码路径：

- `src/go2_jump_planner`
- `src/go2_jump_controller`
- `src/go2_jump_bringup`

本文不讨论 sport mode 的现成技能，也不把 PyBullet 作为主验证链路。这里描述的是一条面向 `unitree_mujoco + unitree_ros2 + LowCmd/LowState` 的低层跳跃控制路线。

## 1. 当前控制目标

当前项目的目标不是直接实现一套完整的最优控制器，而是先搭建一条可运行、可验证、可迭代的跳跃闭环：

- 输入：目标前跳距离
- 规划输出：一份低维跳跃计划 `JumpPlan`
- 控制输出：逐周期 `LowCmd`
- 反馈输入：`LowState`、`SportModeState`、接触估计
- 验证结果：起跳、腾空、落地和恢复阶段的指标报告

现阶段重点解决的问题有两个：

- 让前向位移尽可能在腾空阶段完成，而不是落地后“补出来”
- 让落地姿态更干净，减少明显的前俯和接触混乱

## 2. 总体结构

当前算法可以看成三层：

1. `planner`
   把“目标距离”转换成“期望起跳速度、阶段时长、关键姿态、落地捕获几何”。
2. `controller`
   把 `JumpPlan` 和实时状态拼起来，按相位机逐周期生成 `LowCmd`。
3. `WBC`
   一个可选的附加层，用于把质心级别的期望合力/合力矩转换成关节前馈力矩。

其中：

- 默认主线仍然是“参数化轨迹 + 关节 PD + 前馈力矩”
- `WBC` 目前是实验层，不是默认主路径
- 接触感知已经接入 MuJoCo bridge，用于起跳/落地时序判断

## 3. Planner 在算什么

### 3.1 输入

`planner` 的主要输入是：

- `target_distance_m`
- `takeoff_angle_deg`
- `takeoff_speed_scale`
- 各阶段名义姿态参数
- 各阶段名义时长
- 蹬地、落地阶段的关节前馈力矩参数
- 落地 capture 几何参数

这些参数主要来自：

- `src/go2_jump_bringup/config/jump_params.yaml`
- launch 覆盖参数
- `GO2_JUMP_*` 环境变量

### 3.2 起跳速度求解

第一步是把目标距离映射成名义起跳速度。当前实现使用抛体近似：

```text
v_ballistic = sqrt(d * g / sin(2 * theta))
```

其中：

- `d` 是目标距离
- `g` 是重力加速度
- `theta` 是起跳角

之后再乘一个经验缩放因子：

```text
v_takeoff = v_ballistic * takeoff_speed_scale
```

这一步的目的不是追求理论最优，而是先给控制器一个合理的量纲基线。因为低层执行存在：

- 关节跟踪误差
- 实际起跳时序偏差
- 足底摩擦和接触损失
- 落地恢复对最终位移的扰动

所以 `takeoff_speed_scale` 本质上是一个校准项。

### 3.3 起跳速度分解

求得标量起跳速度以后，planner 会分解出水平和竖直分量：

```text
v_x = v_takeoff * cos(theta)
v_z = v_takeoff * sin(theta)
```

同时还会估计：

- 触地前的名义竖直速度
- 名义腾空时间
- 名义顶点高度

这些量后续会被 controller 和 WBC 用来生成参考。

### 3.4 关键姿态生成

当前 planner 不是输出全时域高分辨率轨迹，而是输出几个关键相位的关键姿态：

- `stand_pose`
- `crouch_pose`
- `push_pose`
- `flight_pose`
- `landing_pose`
- `support_pose`

这些姿态由一组前后腿对称参数构造出来，核心思想是：

- 下蹲阶段压缩腿部，准备储能
- 蹬地阶段放开腿部并带前向偏置
- 腾空阶段收腿，减少不必要的拖地风险
- 落地阶段提前展开前腿、布置捕获几何
- 支撑阶段给出一个更稳的恢复姿态

当前姿态构造同时使用了两类偏置：

- `compactness`
  用关节角层面调节前后腿紧凑程度
- `forward bias`
  用前后腿相反方向的偏置给动作增加前向意图

### 3.5 落地 capture 几何

这是当前 planner 比最早版本更重要的一步。

planner 会根据名义触地水平速度估计一个前向 capture 偏移：

```text
landing_capture_offset
  = clamp(v_touchdown_x * capture_time_constant, 0, capture_limit)
```

然后把这个偏移映射到前后足端：

- 前腿向前放
- 后腿向后收
- 同时加入一定的落地伸腿量 `landing_extension_m`

这一层的作用不是让机器人“凭空多跳一点”，而是让落地那一刻的支撑几何更像一个能接住前向动量的支撑架构。

当前版本又往前加了一步：`support` 阶段使用的 capture 比例不再完全固定，而是会随目标距离变化。短跳会自动减小 `support` 的前向捕获量，避免落地后补位过多；长跳则允许保留更强的支撑捕获。

当前实现可以概括成三步：

```text
alpha_d = smooth_clamp((target_distance_m - 0.20) / 0.10)
effective_support_capture_ratio
  = clamp(support_capture_ratio * (0.80 + 0.30 * alpha_d), 0.0, 1.20)
raw_support_capture_offset
  = effective_support_capture_ratio * landing_capture_offset
effective_support_capture_offset_limit
  = clamp(target_distance_m * (0.22 + 0.06 * alpha_d), 0.025, landing_capture_limit)
effective_support_capture_offset
  = min(raw_support_capture_offset, effective_support_capture_offset_limit)
```

这个额外的上限很关键。没有它时，短距离目标也会继承一段对它来说过强的支撑前伸，
最终表现就是“空中只跳了一点，落地后又在 `support` 段被补出一截位移”。

### 3.6 足端 IK

落地和支撑姿态不是只靠固定关节角写死出来的，而是通过一个简化的二维腿部 IK 计算得到：

- planner 先在足端空间确定前腿、后腿的目标点
- 再把足端点反解成 `thigh/calf` 关节角

这样做的好处是：

- 可以直接调“脚要放到哪里”
- 更适合表达落地捕获几何
- 后续也更容易接到更完整的 centroidal / WBC 路线

### 3.7 Planner 输出

最终 planner 输出一个 `JumpPlan`，其中包含：

- 名义起跳速度和速度分量
- 名义顶点高度和腾空时间
- 各阶段时长
- 各阶段关键姿态
- 推蹬和落地前馈力矩
- 落地 capture 偏移量
- `effective_support_capture_ratio`
- `effective_support_capture_offset_m`
- `effective_support_capture_offset_limit_m`

可以把 `JumpPlan` 理解成：

“一份低维的、可执行的跳跃摘要”

它不是优化器的解，但它给 controller 足够明确的参考。最近几轮调参里，`controller`
也会把这些 planner 量写进报告，目的是把“这次为什么更短了/更长了”追溯到具体的
支撑捕获几何，而不是只看最后停在哪里。

## 4. Controller 在算什么

### 4.1 输入

controller 实时读取三类信息：

- `JumpPlan`
- `/lowstate`
- `/sportmodestate`

其中：

- `/lowstate` 提供关节状态、IMU、桥接过来的足端力估计
- `/sportmodestate` 提供机身位置和速度，用于评估前向位移、腾空高度和速度

### 4.2 启动判定

controller 不会一上来就起跳，而是先检查起始条件：

- 当前姿态是否接近站立位
- 机身速度是否足够小
- 横滚、俯仰是否在允许范围内

这样做是为了减少“上一轮试验还没站稳就开始下一轮”的偶发失败。

### 4.3 相位机

当前 controller 使用一个显式相位机：

- `stand`
- `crouch`
- `push`
- `flight`
- `landing`
- `recovery`
- `complete`

这套相位机不是纯时间驱动，而是“时间 + 接触事件”混合驱动：

- `push` 可以在名义时长之后继续保持，直到检测到真正起跳
- `flight` 可以超过名义抛体时间，直到检测到真正落地

这比最早那种纯定时切换更接近真实跳跃过程。

### 4.4 接触感知

当前 MuJoCo bridge 已经把接触导出的足端法向力注入到了：

- `LowState.foot_force`
- `LowState.foot_force_est`

controller 会对这些量做低通滤波，然后得到：

- 每条腿是否接触
- 总接触力是否低于起跳阈值
- 总接触力是否高于落地阈值

因此现在的起跳和落地判断已经不再完全依赖“高度阈值 + 速度阈值”，而是优先用接触信息。

### 4.5 每个相位如何生成目标

#### `crouch`

从 `stand_pose` 插值到 `crouch_pose`，让机器人完成下蹲。

#### `push`

从 `crouch_pose` 插值到 `push_pose`，同时叠加两种控制量：

- 关节 PD
- 蹬地前馈力矩

这里的目标是把起跳速度做出来，而不是只把姿态摆到某个角度。

#### `flight`

飞行阶段默认使用较低的 `kp`，避免空中刚性过强。

这个阶段当前会做三件事：

1. 使用 `flight_pose`
2. 根据下降速度和当前高度，逐步混入 `landing_pose`
3. 用 IMU 俯仰反馈做姿态整形

这一步是当前“让动作看起来像真的前跳”最关键的部分之一。

#### `landing`

落地阶段从当前落地参考姿态逐渐过渡到 `support_pose`，同时：

- 增加阻尼
- 注入吸收落地冲击的前馈力矩
- 保留 pitch 修正

#### `recovery`

恢复阶段分成两段：

1. 先在 `support_pose` 一带 hold 住，等姿态和速度稳定
2. 再释放回恢复目标姿态

这一段的目标不是“多往前蹭”，而是把落地之后的姿态收干净。

这里还有一层最近加上的距离自适应。`landing_reference_pose` 和 `support_pose`
之间的插值比例不再完全固定，而是按目标距离缩放：

```text
alpha_d = smooth_clamp((target_distance_m - 0.20) / 0.10)
effective_landing_support_blend
  = clamp(landing_support_blend * (0.80 + 0.20 * alpha_d), 0.0, 1.0)
```

短距离目标会用更小的 `landing -> support` 过渡比例，目的很明确：减少短跳在落地后
被一套过强支撑姿态继续往前“顶”出去。

### 4.6 Pitch 修正目前分成两层

这是当前 controller 的一个重要设计点。

#### 第一层：关节紧凑度修正

`ApplyPitchCompactnessCorrection()` 会根据：

- 机身俯仰角
- 机身俯仰角速度
- 当前相位的俯仰目标

对前后腿做相反方向的紧凑度修正。

它的特点是：

- 实现简单
- 计算便宜
- 对短时姿态整形有效

但它的局限也很明显：

- 只能在关节角层面“推一把”
- 不能直接表达“脚应该往哪里放”

#### 第二层：足端几何 pitch capture 修正

当前版本新加了一层 `ApplyPitchCaptureFootPlacementCorrection()`。

它的做法是：

1. 先把当前目标姿态转成前后足端点
2. 根据俯仰误差和俯仰角速度，算一个足端修正量
3. 在足端空间修改前后脚的前后位置和高低位置
4. 再用二维腿部 IK 反解回关节角

如果机身在落地前明显前俯，这一层会倾向于：

- 让前腿更前、更展开
- 让后腿更后、更收一些

它的目的有两个：

- 在空中晚期和触地瞬间给机身一个更好的捕获几何
- 在恢复早期快速建立一个能“接住”机身的支撑架构

当前这层已经被接到了：

- `flight` 晚期
- `landing`
- `recovery` 的支撑保持段

同时在 `recovery` 支撑段又加了一层时间衰减，避免它在落地后持续过久，把前向位移继续“拱”出来。

同样地，`support pitch capture` 也不再对所有跳距一视同仁。短距离目标会自动降低这层修正的强度，减少“本来只该小跳一下，结果落地后又往前多顶了一截”的问题。

当前控制器里的距离缩放是：

```text
support_pitch_capture_distance_scale
  = 0.65 + 0.35 * smooth_clamp((target_distance_m - 0.20) / 0.10)
```

这意味着：

- `0.20 m` 一带的短跳，`support pitch capture` 会明显减弱
- 接近 `0.30 m` 的目标，才逐步恢复到更强的支撑期姿态捕获

这一层和上面的 `effective_support_capture_offset_limit` 是配套工作的。前者控制
“姿态纠偏的力度”，后者控制“支撑几何能前伸多少”。两层一起调，才能把短距离的
落地后补位压下来，而不是只在一个通道里硬削增益。

### 4.7 为什么还保留落地后补位

严格来说，理想前跳应该把大部分前向位移放在腾空阶段完成。

但现实里落地后仍然会出现一部分补位，原因主要有三类：

1. 真实起跳角动量和名义规划仍有偏差
2. touchdown 以后支撑几何仍会重新分配机身动量
3. recovery 段必须先保住姿态，再谈尽量少补位

所以当前 controller 的思路不是“强行完全消灭落地后位移”，而是：

- 先把 `airborne_forward_progress_m` 做高
- 再把 `post_landing_forward_gain_m` 压低
- 同时不要把姿态做得很难看

### 4.8 报告系统

controller 会在每次试验后写出一份指标报告，核心字段包括：

- `takeoff_forward_displacement_m`
- `landing_forward_displacement_m`
- `airborne_forward_progress_m`
- `post_landing_forward_gain_m`
- `landing_pitch_deg`
- `final_pitch_deg`
- `push_extension_after_plan_s`
- `flight_extension_after_plan_s`
- `support_hold_forward_gain_m`
- `release_to_complete_forward_gain_m`

这些字段的作用不是“做漂亮日志”，而是给调参和算法迭代提供统一判据。

其中最近最好用的一组判断标准是：

- `airborne_forward_progress_m`
  看真正的腾空前移是否在变多。
- `post_landing_forward_gain_m`
  看最终位移是不是主要靠落地后补出来的。
- `support_hold_forward_gain_m`
  看 `support` 几何是不是仍然过强。
- `release_to_complete_forward_gain_m`
  看恢复段有没有把已经得到的前向位移又回摆掉。

## 5. WBC 在算什么

### 5.1 目前 WBC 的定位

当前仓库里的 WBC 还是一个实验层，不是完整的 whole-body optimization。

它的任务比较收敛：

- 根据期望的机身线速度、竖直速度和俯仰目标
- 先生成一个简化的质心级别期望合力/合力矩
- 再把这些量分配到各条支撑腿
- 最后通过 `J^T f` 映射成关节前馈力矩

### 5.2 质心级期望量怎么来

在 `push` 阶段，WBC 会根据名义起跳速度 `v_x / v_z` 和当前机身速度计算：

- 期望水平加速度
- 期望竖直加速度
- 期望俯仰力矩

在 `landing` / `recovery` 阶段，WBC 会更多关注：

- 压低前向速度
- 把机身高度拉回基准
- 抑制过大的俯仰角和俯仰角速度

### 5.3 接触腿选择

WBC 不会无脑把力分给四条腿。

它会根据当前阶段判断支撑集合：

- `push` 阶段默认四条腿都参与
- `landing` / `recovery` 阶段依据接触估计选择有效支撑腿

如果接触估计过弱但总接触力已经明显升高，也会走一个保底逻辑，避免因为接触检测抖动导致 WBC 完全失效。

### 5.4 力分配怎么做

当前实现不是完整 QP，而是一个简化分配器：

1. 先确定总水平力、总竖直力、总俯仰力矩
2. 再把总力平均分到有效支撑腿
3. 用腿的前后位置近似分配俯仰力矩
4. 对每条腿施加法向力上限和摩擦约束

这一步本质上是在做一个简化的 contact wrench allocation。

### 5.5 为什么最后是 `J^T f`

支撑腿的接触力是在足端空间定义的，但电机能执行的是关节力矩。

因此需要做：

```text
tau = J^T * f
```

其中：

- `f` 是足端期望接触力
- `J` 是足端相对于关节的雅可比
- `tau` 是关节前馈力矩

当前实现使用的是简化的矢状面雅可比，只考虑前后和上下两个方向。

### 5.6 为什么 WBC 现在不是默认路径

原因很直接：

- 当前质心模型还是二维近似
- 接触集合仍然是阈值逻辑，不是高质量状态估计
- 力分配不是完整约束优化
- 还没有把机身角动量规划和足端时序规划真正耦合起来

所以当前 WBC 可以作为实验工具，但还没有稳定到足以替代“参数化姿态 + PD + 前馈”的默认主路径。

## 6. 当前版本的优点和短板

### 6.1 当前已经具备的能力

- 可以按目标距离生成一份低维跳跃计划
- 可以通过 `LowCmd` 真正驱动 MuJoCo 里的 Go2
- 可以在接触感知辅助下完成起跳和落地时序判定
- 可以输出用于调参与回归比较的试验报告
- 已经具备基础的落地 capture 几何和俯仰整形能力

### 6.2 还没有彻底解决的问题

- 质心和角动量仍没有做联合规划
- 飞行阶段姿态调整仍然偏启发式
- touchdown 之后仍存在一定补位
- WBC 还不是完整 QP 级别的全身控制
- 当前建模基本集中在矢状面，横向耦合只做了很弱的隐式处理

## 7. 往“高质量跳跃控制器”继续推进时，下一步该补什么

如果目标是继续从“能跑”走向“高质量”，下一步最值得做的事情有三件：

1. 把接触观测做得更稳
   包括接触置信度、触地点切换和接触历史滤波。
2. 把 planner 升级成显式的 centroidal jump planner
   不只给出起跳速度，还要给出机身姿态、角动量和触地前后期望支撑几何。
3. 把 WBC 升级成真正的约束优化
   让接触力分配同时考虑摩擦锥、法向力上下界、力矩限制和姿态目标。

从工程角度看，当前版本最重要的价值不是“已经把最优控制做好了”，而是：

- 控制链路已经打通
- 指标体系已经建立
- 算法接口已经为后续重构留好了位置

这意味着后面无论是继续强化参数化控制，还是真正切到 `contact-aware planner + centroidal model + WBC/QP`，都可以在现有仓库上迭代，而不是推倒重来。
