# FitnessAI 详细测试设计与执行报告

> **团队 ID**：[请填写团队 ID]  
> **小组成员**：[请填写成员姓名及学号]  
> **文档类型**：详细测试设计与执行报告（Detailed Test Design and Execution Report）  
> **目标应用**：FitnessAI — 智能健身辅助系统  
> **文档版本**：v2.0  
> **日期**：2026-05-29  
> **参考标准**：ISO/IEC/IEEE 29119-4（测试技术与设计）  
> **生成方式**：测试用例大纲由 AutoTestDesign 工具自动设计，经设计者交互式验证与校准，最终由 JUnit 5 脚本在本地执行通过。

---

## 目录

1. [概念与设计逻辑](#1-概念与设计逻辑)
2. [细粒度覆盖项（Coverage Items）识别](#2-细粒度覆盖项coverage-items识别)
3. [黑盒测试用例设计与设计方法](#3-黑盒测试用例设计与设计方法)
4. [白盒测试建模与测试序列设计](#4-白盒测试建模与测试序列设计)
5. [提示设计（Prompt Design）](#5-提示设计prompt-design)
6. [测试预言设计（Test Oracle）](#6-测试预言设计test-oracle)
7. [设计者交互与有效性验证实证](#7-设计者交互与有效性验证实证)
8. [双向追溯矩阵（Traceability Matrix）](#8-双向追溯矩阵traceability-matrix)
9. [测试脚本开发（JUnit 5 + MockMvc）](#9-测试脚本开发junit-5--mockmvc)
10. [一键归档与 ThreadLocal 日志捕获系统](#10-一键归档与-threadlocal-日志捕获系统)
11. [全量 81 条测试用例明细汇总表](#11-全量-81-条测试用例明细汇总表)
12. [测试执行结果与深度分析](#12-测试执行结果与深度分析)
13. [基于证据的用例改进与人工审计](#13-基于证据的用例改进与人工审计)

---

## 1. 概念与设计逻辑

在软件测试中，AI 辅助或 AI 驱动的测试设计是提升测试效率和覆盖深度的前沿技术。针对 **FitnessAI** 智能健身辅助系统，我们构建并使用了 **AutoTestDesign** 自动化测试设计工具。

### 1.1 被测业务特性建模
FitnessAI 核心是一款结合了计算机视觉与动作分析的实时健身辅助应用。其核心调用链路如下：
```
[摄像头视频帧] ──► [MediaPipe 姿态识别] ──► [33 个关键点 Landmark 数组] 
                      ──► [Spring Boot (POST /api/analytics/pose)] 
                      ──► [运动状态机判定 & 计数] ──► [UserController 存储记录]
```
我们选择了 FitnessAI 中核心的两大服务端接口作为详细测试设计的对象：
1. **姿态分析接口** (`POST /api/analytics/pose`)：接收关键点数组，触发状态机转换，判定计数。
2. **训练记录存储接口** (`POST /api/user/{id}/records`)：实现记录持久化及核心的业务规则拦截（无效数据过滤）。

### 1.2 混合测试设计方法论
为了确保测试的有效性，我们采取了“混合式（Hybrid）”设计理念：
* **静态黑盒层**：利用 EP（等价划分）保障输入完整性；利用 BVA（边界值分析）防范极值溢出；利用 决策表（Decision Table） 覆盖条件交叉组合；利用 Pairwise（组合测试） 在低成本下覆盖参数搭配。
* **结构白盒层**：通过 状态转换测试 完整覆盖深蹲动作周期中的各个状态迁移路径；通过 判定分支覆盖 对底层的服务存盘方法进行 100% 路径覆盖。

---

## 2. 细粒度覆盖项（Coverage Items）识别

在 AutoTestDesign 规则引擎中，需求并不是被笼统地映射成用例，而是被细分为了**明确的、原子化的测试覆盖项**。针对所测模块，工具在解析需求后识别并导出了 **37 个细粒度覆盖项**，其完整清单如下表：

### 37 个细粒度覆盖项完整清单

| 覆盖项分类 | 覆盖项 ID | 覆盖项中文描述 (Atomic Test Coverage Requirement) |
| --- | --- | --- |
| **姿态分析 (Pose)**<br>*(12个)* | `COV-POSE-001` | 校验合法运动类型（SQUAT/PUSHUP/PLANK/JUMPING_JACK）的输入识别 |
| | `COV-POSE-002` | 拦截非法的未知运动类型输入并返回 4xx 客户端错误 |
| | `COV-POSE-003` | 校验关键点数组为空（Null）时的异常防护拦截 |
| | `COV-POSE-004` | 校验关键点点数刚好等于 33 的标准合规情况 |
| | `COV-POSE-005` | 校验关键点点数少于 33 个点（如 32 个点）时的物理边界约束拦截 |
| | `COV-POSE-006` | 校验关键点点数多于 33 个点（如 34 个点）时的物理上限约束拦截 |
| | `COV-POSE-007` | 校验极端的非法点数（31个点）的安全拦截 |
| | `COV-POSE-008` | 校验极端的非法点数（35个点）的安全拦截 |
| | `COV-POSE-009` | 校验 SessionId 参数缺失时的请求响应状态 |
| | `COV-POSE-010` | 校验同一个 Session 内姿态帧连续递增的分析连续性 |
| | `COV-POSE-011` | 验证重置接口 `POST /api/analyzer/reset/{type}` 的有效重置 |
| | `COV-POSE-012` | 验证重置非法类型时的拦截响应 |
| **状态机计数 (State)**<br>*(8个)* | `COV-STATE-001` | 验证初始化状态（UP）的动作基准线判定 |
| | `COV-STATE-002` | 验证下蹲中状态（DESCENDING）的过渡态转换 |
| | `COV-STATE-003` | 验证深蹲最低点状态（DOWN）的夹角门槛判定 |
| | `COV-STATE-004` | 验证起身中状态（ASCENDING）的过渡态转换 |
| | `COV-STATE-005` | 验证回到站立状态（UP）触发 count 递增 |
| | `COV-STATE-006` | 验证短循环序列（如 UP -> DESCENDING -> UP，未过 DOWN 点）不计数的拦截 |
| | `COV-STATE-007` | 验证冷却状态（COOLDOWN）对长驻 Session 的自动重置 |
| | `COV-STATE-008` | 验证多 Session 状态机的绝对数据隔离性 |
| **记录过滤 (Record)**<br>*(7个)* | `COV-REC-001` | 验证 `count >= 3` 且 `duration >= 30` 时的成功保存响应（200 OK） |
| | `COV-REC-002` | 验证 `count < 3` 且 `duration < 30` 时的安全拦截过滤（204 No Content） |
| | `COV-REC-003` | 验证 `count < 3` 但 `duration >= 30` 时的边界存盘情况 |
| | `COV-REC-004` | 验证 `count >= 3` 但 `duration < 30` 时的边界存盘情况 |
| | `COV-REC-005` | 验证 count 字段为负值（如 -1）时的异常过滤处理 |
| | `COV-REC-006` | 验证 duration 字段为负值（如 -1）时的异常过滤处理 |
| | `COV-REC-007` | 验证 `userId` 账户不存在（"null"）时的系统容错保存或自动建档行为 |
| **计划与过滤组合 (Plan)**<br>*(6个)* | `COV-PLAN-001` | 组合覆盖：深蹲历史记录（squat） × 80分限额 × 按时间排序（date） |
| | `COV-PLAN-002` | 组合覆盖：深蹲历史记录（squat） × 90分限额 × 按得分排序（score） |
| | `COV-PLAN-003` | 组合覆盖：俯卧撑历史记录（pushup） × 80分限额 × 按得分排序（score） |
| | `COV-PLAN-004` | 组合覆盖：俯卧撑历史记录（pushup） × 90分限额 × 按时间排序（date） |
| | `COV-PLAN-005` | 组合覆盖：平板支撑历史记录（plank） × 80分限额 × 按时间排序（date） |
| | `COV-PLAN-006` | 组合覆盖：平板支撑历史记录（plank） × 90分限额 × 按得分排序（score） |
| **仪表盘统计 (Dash)**<br>*(4个)* | `COV-DASH-001` | 校验仪表盘平均卡路里指标（MET计算公式）的数值正确性 |
| | `COV-DASH-002` | 校验用户总时长单位统一性及时间跨度分布 |
| | `COV-DASH-003` | 校验无历史运动记录新用户的仪表盘零数据平滑渲染 |
| | `COV-DASH-004` | 校验极端的历史大体量运动数据累加不溢出 |

---

## 3. 黑盒测试用例设计与设计方法

基于上述识别出的覆盖项，AutoTestDesign 应用了四大核心黑盒测试设计技术。

### 3.1 等价类划分（EP）设计示例
我们将姿态分析的运动类别与记录过滤字段划分为不同的等价类：
* **有效等价类**：合法的运动 `SQUAT`/`PUSHUP`/`PLANK`/`JUMPING_JACK`，有效关键点数 `33`，合法的用户 ID。
* **无效等价类**：非法的运动 `YOGA`/`unknown`，空输入，无效点数，非法的负数计数。

### 3.2 边界值分析（BVA）设计示例
针对核心物理边界和业务边界进行极值设计：
* **点数边界**：31（下边界-1，无效）、32（下边界，无效）、33（标准值，有效）、34（上边界，有效）、35（上边界+1，无效）。
* **过滤边界**：`count` 边界（2, 3, 4），`duration` 边界（29, 30, 31）。

### 3.3 决策表（Decision Table）设计示例
针对记录保存过滤的逻辑（`count < 3` 且 `duration < 30` 拦截），建立判定决策表：

| 条件 \ 决策规则 | 规则 1 (`TC-DT-005`) | 规则 2 (`TC-DT-006`) | 规则 3 (`TC-DT-007`) | 规则 4 (`TC-DT-008`) |
| --- | --- | --- | --- | --- |
| 条件 1：`count < 3`是否满足 | **Yes** (2) | **Yes** (2) | **No** (3) | **No** (3) |
| 条件 2：`duration < 30`是否满足| **Yes** (20s) | **No** (30s) | **Yes** (20s) | **No** (30s) |
| **预期动作**：拒绝存入数据库，返回 `204` | **执行** | | | |
| **预期动作**：允许存入数据库，返回 `200` | | **执行** | **执行** | **执行** |

### 3.4 组合测试（Pairwise）设计示例
针对用户历史运动记录筛选接口（`GET /api/user/{userId}/records`）中的多参数过滤条件，如果使用全量笛卡尔积测试，需要生成大量的组合。为了在低成本下实现高效的多条件筛选覆盖，工具使用了 **Pairwise（两两配对组合）** 算法，自动生成了最优的 6 个测试用例，在保证 100% 覆盖所有参数因子对的前提下，极大缩减了测试规模：

* **因子 1：`exerciseType`**（squat, pushup, plank）
* **因子 2：`minScore`**（80, 90）
* **因子 3：`sortBy`**（date, score）

#### 配对组合矩阵生成：
* `TC-CB-001`：`exerciseType = squat` × `minScore = 80` × `sortBy = date`
* `TC-CB-002`：`exerciseType = squat` × `minScore = 90` × `sortBy = score`
* `TC-CB-003`：`exerciseType = pushup` × `minScore = 80` × `sortBy = score`
* `TC-CB-004`：`exerciseType = pushup` × `minScore = 90` × `sortBy = date`
* `TC-CB-005`：`exerciseType = plank` × `minScore = 80` × `sortBy = date`
* `TC-CB-006`：`exerciseType = plank` × `minScore = 90` × `sortBy = score`

---

## 4. 白盒测试建模与测试序列设计

白盒测试是对系统内部状态和逻辑分支的精准覆盖。

### 4.1 姿态分析状态机转换图设计
根据白盒建模，我们绘制了深蹲（SQUAT）周期分析状态机的标准转换关系：

```mermaid
stateDiagram-v2
    [*] --> UP : 初始化 Session
    UP --> DESCENDING : 关节夹角变小 (检测下蹲动作开始)
    DESCENDING --> DOWN : 臀部夹角变低 (进入深蹲最低极限点)
    DOWN --> ASCENDING : 臀部夹角变大 (检测起身动作开始)
    ASCENDING --> UP : 恢复直立 (满足完整周期, count++)
    UP --> COOLDOWN : 停止运动超过 5 秒
    COOLDOWN --> [*] : 清除 Session
```

### 4.2 状态迁移测试用例序列（All-States 覆盖）
为覆盖图中所有的状态迁移，工具利用图遍历算法自动派生出 5 条最优测试用例序列：
* `TC-ST-001`：验证 `UP` 基准状态。
* `TC-ST-002`：从 `UP` 迁移至 `DESCENDING`。
* `TC-ST-003`：从 `DESCENDING` 迁移至 `DOWN`（核心角度门槛）。
* `TC-ST-004`：从 `DOWN` 迁移至 `ASCENDING` 并成功回到 `UP` 促使计数自增。
* `TC-ST-005`：验证 `UP` 超时向 `COOLDOWN` 的安全冷却重置。

### 4.3 底层服务方法的分支覆盖（Branch Coverage）
针对底层的 `UserService.saveExerciseRecord` 执行方法级白盒分支判定覆盖：
```java
// 被测方法核心分支路径
if (count < 3 && duration < 30) {
    return null; // 分支 A (对应 TC-WBJ-001, TC-WBJ-003)
}
return recordRepository.save(new ExerciseRecord(...)); // 分支 B (对应 TC-WBJ-002, TC-WBJ-004)
```

---

## 5. 提示设计（Prompt Design）

在 AutoTestDesign 工具中，为了避免大语言模型在生成过程中产生“能力幻觉”或将“工具自身的开发测试”误当成 FitnessAI 的业务测试，我们为 `ai-service` 设计了一套高度结构化且聚焦领域上下文的 Prompt 控制体系：

### 5.1 提示词模板核心设计结构
提示词模板分为系统设定（System Instructions）与用户上下文（User Context）两部分，采用了基于 **Role-Based（基于角色）** 与 **Few-Shot（少样本）** 引导的技术思路：
1. **角色界定与任务对齐**：明确 LLM 的身份为“高级软件测试开发工程师（SDET）”，依据 ISO 29119-4 标准为目标应用 FitnessAI 规划测试套件。
2. **上下文隔离防御机制**：通过在 Prompt 中直接硬编码注入 `TARGET_APP_CONTEXT = FitnessAI` 的上下文常数，以及引入具体的业务范围（姿态分析 API、SQUAT 状态机循环、204拦截规则），强制约束 LLM 决不能编写测试 AutoTestDesign 自身的用例。
3. **格式化架构约束（Schema Enforcing）**：声明输出必须 100% 吻合由 `schema_validator` 定义的 JSON 格式，包含结构化需求（`requirementsStructured`）、风险矩阵评分（`riskScore`）、覆盖项列表、可执行测试用例大纲等八大工件。

### 5.2 核心 Prompt 控制注入片段
```text
Role: Senior Test Architect
Target Application: FitnessAI (DO NOT test the AutoTestDesign tool itself!)
Focus Scope: 
- POST /api/analytics/pose (EP of exercise types, BVA of landmarks 32/33/34)
- POST /api/user/{id}/records (DT of count < 3 && duration < 30 -> 204 Content Filter)
Output Format Constraint: Return purely a JSON block containing structural items conforming to ISO 29119-4.
```

---

## 6. 测试预言设计（Test Oracle）

测试预言用于确定被测程序对于给定输入的预期行为是否正确。在本项目中，我们通过规则约束定义了测试预言的判定条件：
1. **PoseAnalysisOracle**：若传入 33 个点且类型为 `SQUAT`，预期 API 返回的 JSON 包含非空反馈意见（feedback）、无异常的 count 和 score，状态码为 `200 OK`；否则抛出 `4xx` 错误。
2. **RecordFilteringOracle**：
   $$\text{ExpectedStatus} = \begin{cases} 204 \text{ No Content}, & \text{if } \text{count} < 3 \land \text{duration} < 30 \\ 200 \text{ OK}, & \text{otherwise} \end{cases}$$
   此数学预言被严格写进了自动化测试代码中的 `.andExpect(status().is...)` 判定中。

---

## 7. 设计者交互与有效性验证实证

根据课设“主要内容”的显式要求，工具的运行决不能成为黑盒，必须**体现设计者（测试人员）的主动参与以及对生成有效性进行的交互式验证**。

### 7.1 工具提供的交互式审查能力（Interactive Review）
AutoTestDesign 提供了专用的双面板及交互审查区，允许设计者在用例生成后进行精细修改：
1. **覆盖项可变性（Coverage Item Revision）**：生成覆盖项后，测试员可以在文本区逐行增加或删减覆盖特征（例如，新增“卡路里负值检测”覆盖项）。
2. **测试策略及 ISO 29119 映射编辑**：允许在交互框内直接修改 ISO 29119-4 关联映射（如将 `TC-EP-002` 与特定边界值合并）。
3. **用例表单与 JSON 动态调整**：提供即时编辑（Live Edit）表单，测试员可以直接更改测试步骤（Steps）、预期结果（Expected）及测试预言（Oracle）。
4. **应用并生效修改（Apply Changes）**：在对设计项进行了修订后，点击“Apply Changes”会触发后端重算覆盖率指标与作业符合性评分，重新生成最终一致性的 Markdown 与 Excel 工件包。

### 7.2 真实交互审查案例实证（Before-After 对比）

#### 7.2.1 案例一：测试用例预期与 Oracle 断言交互校正（`TC-EP-010`）
在实际测试设计活动中，设计者对生成的 `TC-EP-010` 用例进行了关键的交互式修订。以下为该项修改在工具中的真实对比记录：

##### 修订前状况 (Before)
由于 LLM 的通用假设，工具在初次生成用例时，针对“空 JSON 请求体”提交至 `/api/user/{id}/records` 的测试用例（`TC-EP-010`）做出了错误的判定预测：
```json
{
  "id": "TC-EP-010",
  "name": "test_TC_EP_010",
  "expectedResponse": "400 Bad Request",
  "linkedCoverage": "COV-REC-002 (空请求报错)",
  "oracle": "Assert status is 4xx"
}
```

##### 设计者交互式修订行为 (UI Action)
1. 设计者在 **Interactive Review - Test Cases 表格**中，双击 `TC-EP-010` 的 `expectedResponse` 输入框，将其修改为 `204 No Content`（因为 Spring Boot 在反序列化空 Body 时会自动降级采用默认值对象，进而触发后端的无效记录过滤器，安全返回 204）。
2. 设计者修改对应的 **Traceability 追溯框**，将 `oracle` 改写为 `Assert status is 204`。
3. 点击 **Apply Changes**。

##### 修订后状况 (After)
工具后端重新解析了该交互提交的变动，更新了全局追溯链路，并在数据库中将其持久化保存：
```json
{
  "id": "TC-EP-010",
  "name": "test_TC_EP_010",
  "expectedResponse": "204 No Content",
  "linkedCoverage": "COV-REC-002 (空请求安全过滤)",
  "oracle": "Assert status is 204"
}
```
*这套审查机制使得最终导出的 JUnit 测试类断言能与后端实际安全机制 100% 一致。*

#### 7.2.2 覆盖项（Coverage Item）主动增补与双向追溯链重算
在系统鲁棒性及安全性审计时，设计者（测试架构师）注意到用户资料更新接口（`PUT /api/user/{userId}/profile`）的输入可能存在特殊字符和SQL注入隐患，而工具最初未从基础功能描述中自动抽象出此安全属性。

##### 修订前状况 (Before)
AutoTestDesign 初次生成的覆盖项列表中，共有标准的 37 个细粒度覆盖项，其安全性维度仅涵盖基础空值检测，缺乏专门的安全健壮性验证点。

##### 设计者交互式修订行为 (UI Action)
1. 设计者在工具前端的 **Interactive Review - Coverage Items** 编辑区中，点击“Add Item”并输入自定义覆盖要求：
   * `COV-USER-SEC-001 | 验证用户资料更新接口对特殊转义字符与潜在 SQL 注入的安全防御能力`
2. 点击 **Apply Changes** 提交。

##### 修订后状况 (After)
工具后端核心引擎监听到配置变更后，自动触发了流水线的重算：
1. **指标重算**：全局覆盖项总数自动从 37 扩展至 38 个。
2. **追溯链重连**：系统底层自动在 `generation_records` 的关系依赖表中，为该新增的 `COV-USER-SEC-001` 分配了独立的关联空间，并在 Traceability 矩阵中建立追溯锚点，允许设计者在用例表格中快速将 `test_TC_WBJ_002` 与该安全性条件挂接。
3. **策略映射更新**：自动重新渲染的 xlsx 工件包与 Markdown 双面板中，该安全性测试策略与覆盖状态实现了全局一致性的无缝更新。

---

---

## 8. 双向追溯矩阵（Traceability Matrix）

### 8.1 需求 ↔ 覆盖项 ↔ 用例 ↔ 代码双向追溯矩阵

我们为全量用例建立了完备、严谨的双向追溯，以下是核心设计追溯表格：

| 原始需求 ID | 结构化需求描述 | 覆盖项 ID (Coverage Items) | 测试用例 ID | 采纳测试技术 | JUnit 自动化测试方法签名 |
| --- | --- | --- | --- | --- | --- |
| `REQ-POSE-001` | 合法姿态解析 | `COV-POSE-004`<br>`COV-POSE-001` | `TC-EP-001`<br>`TC-EP-005` | 等价类 (EP) | `test_TC_EP_001()` / `test_TC_EP_005()` |
| `REQ-POSE-002` | 非法运动过滤 | `COV-POSE-002` | `TC-EP-002` | 等价类 (EP) | `test_TC_EP_002()` |
| `REQ-POSE-003` | 点数不足拦截 | `COV-POSE-005` | `TC-BVA-002` | 边界值 (BVA) | `test_TC_BVA_002()` |
| `REQ-POSE-004` | 极值上限边界 | `COV-POSE-006` | `TC-BVA-005` | 边界值 (BVA) | `test_TC_BVA_005()` |
| `REQ-STATE-001` | 深蹲完整迁移 | `COV-STATE-001`<br>`COV-STATE-003`<br>`COV-STATE-005` | `TC-ST-001`<br>`TC-ST-003`<br>`TC-ST-004` | 状态转换 (ST) | `test_TC_ST_001()` / `test_TC_ST_003()` / `test_TC_ST_004()` |
| `REQ-STATE-002` | 短循环过滤 | `COV-STATE-006` | `TC-DT-004` | 决策表 (DT) | `test_TC_DT_004()` |
| `REQ-REC-001` | 有效记录存盘 | `COV-REC-001` | `TC-EP-011` | 等价类 (EP) | `test_TC_EP_011()` |
| `REQ-REC-002` | 无效记录拦截 | `COV-REC-002` | `TC-DT-005`<br>`TC-BVA-013` | 决策表 / 边界值 | `test_TC_DT_005()` / `test_TC_BVA_013()` |
| `REQ-PLAN-001` | 记录筛选组合 | `COV-PLAN-001`<br>`COV-PLAN-005` | `TC-CB-001`<br>`TC-CB-005` | 因果组合 (CB) | `test_TC_CB_001()` / `test_TC_CB_005()` |
| `REQ-DASH-001` | 仪表盘展示 | `COV-DASH-001`<br>`COV-DASH-003` | `TC-EP-019`<br>`TC-DT-016` | 决策表 (DT) | `test_TC_EP_019()` / `test_TC_DT_016()` |
| `REQ-WB-001` | 保存方法白盒 | `COV-REC-002`<br>`COV-REC-001` | `TC-WBJ-001`<br>`TC-WBJ-002` | 分支判定 (WB) | `test_TC_WBJ_001()` / `test_TC_WBJ_002()` |

### 8.2 覆盖策略与技术映射表
为了客观分析测试覆盖的有效性，我们将最终生成的 81 条测试用例与所采纳的测试设计技术和识别出的核心覆盖项进行了详尽的映射梳理：

| 测试方法 / 技术类别 | ISO 29119-4 技术编号 | 关联测试用例 ID 范围 | 识别的核心覆盖项 (Coverage Items) | 用例数量 |
| --- | --- | --- | --- | --- |
| **等价划分 (EP)** | ISO 29119-4 Sec 5.2 | `TC-EP-001` - `TC-EP-020` | 有效/无效的运动类型解析、空值输入、过滤临界区等价类 | 20 |
| **边界值分析 (BVA)** | ISO 29119-4 Sec 5.3 | `TC-BVA-001` - `TC-BVA-030` | 姿势关键点长度极值边界（31, 32, 33, 34）、过滤计数/时长极值边界 | 30 |
| **决策表 (Decision Table)** | ISO 29119-4 Sec 5.4 | `TC-DT-001` - `TC-DT-016` | 卡路里计算因子交叉组合、计划生成限制因子（T/T、T/F、F/T、F/F） | 16 |
| **因果组合 (Combinatorial)**| ISO 29119-4 Sec 5.5 | `TC-CB-001` - `TC-CB-006` | 历史记录多参数过滤与排序机制的两两配对组合（Pairwise 组合） | 6 |
| **状态转换 (State Transition)**| ISO 29119-4 Sec 5.6 | `TC-ST-001` - `TC-ST-005` | 深蹲运动周期的完整状态转换迁移（All-States 覆盖） | 5 |
| **分支判定 (Branch Whitebox)**| ISO 29119-4 Sec 6.2 | `TC-WBJ-001` - `TC-WBJ-004` | `UserService.saveExerciseRecord` 底层方法分支路径 | 4 |

---

## 9. 测试脚本开发（JUnit 5 + MockMvc）

### 9.1 后端 API 测试：JUnit 5 + REST Assured

| 评估维度 | JUnit 5 + REST Assured | Postman/Newman | PyTest + Requests |
|---------|----------------------|----------------|-----------------|
| 与被测系统语言一致 | ✅ Java 项目，天然融合 | ❌ 需独立工具链 | ❌ 跨语言 |
| Maven 集成 | ✅ `pom.xml` 已含 `spring-boot-starter-test` | 需 Newman CLI | 需 Python 环境 |
| `@Transactional` 测试回滚 | ✅ | ❌ | ❌ |
| 工具导出用例直接转化 | ✅ TC-ID 直接映射测试方法 | ❌ 需转换 | ⚠️ 需转换 |

**结论**：工具导出的 81 条用例（TC-EP-001 等）可直接映射为 JUnit5 `@Test` 方法名，与 Spring Boot 测试生态完全兼容。

在 `FitnessAiApiTests.java` 中利用 Spring Boot 的 MockMvc 机制开发了全部 81 条测试脚本。下面是测试脚本中核心测试方法的开发实现片段：

```java
@SpringBootTest(classes = FitnessAiApplication.class)
@AutoConfigureMockMvc
@Transactional
@Epic("FitnessAI")
@ExtendWith(TestResultExtension.class) // 挂载日志与报告归档扩展
public class FitnessAiApiTests {

    @Autowired
    private MockMvc mockMvc;

    @Autowired
    private ObjectMapper objectMapper;

    // TS-01: EP 等价划分用例示例
    @Test
    @DisplayName("TC-EP-001")
    @Feature("Pose Analysis")
    @Story("Equivalence Partitioning")
    @Description("EP-有效等价类-pose analysis")
    public void test_TC_EP_001() throws Exception {
        PoseAnalysisRequest request = new PoseAnalysisRequest(createLandmarks(33), ExerciseType.SQUAT, "session_001");
        mockMvc.perform(post("/api/analytics/pose")
                .contentType(MediaType.APPLICATION_JSON)
                .content(objectMapper.writeValueAsString(request)))
                .andExpect(status().isOk());
    }

    // TS-03: Decision Table 决策表过滤用例示例
    @Test
    @DisplayName("TC-DT-005")
    @Feature("Exercise Records")
    @Story("Decision Table")
    @Description("决策表-count<3, duration<30")
    public void test_TC_DT_005() throws Exception {
        Map<String, Object> body = new HashMap<>();
        body.put("exercise_type", "squat");
        body.put("count", 2);
        body.put("duration", 20);
        mockMvc.perform(post("/api/user/test_user_automation/records")
                .contentType(MediaType.APPLICATION_JSON)
                .content(objectMapper.writeValueAsString(body)))
                .andExpect(status().isNoContent()); // 👈 验证 204 No Content
    }
}
```

---

## 10. 一键归档与 ThreadLocal 日志捕获系统

我们编写并挂载了 **`TestResultExtension.java`**（JUnit 5 扩展）。

### 10.1 核心原理：ThreadLocal 日志拦截
通过重定向 JVM 全局的 `System.setOut` 与 `System.setErr`，将当前线程正在打印的 Spring Boot 日志和 SQL 语句安全拦截并实时保存至 ThreadLocal 缓冲区中，从而实现在 Allure 界面直接查看用例 SQL/启动日志的功能。

### 10.2 全自动报告归档工作流
在 81 条测试全部运行完毕的瞬间（`AfterAll` 阶段），此扩展在后台自动触发 Allure 编译器编译，在根目录下自动创建以年月日时分秒命名的归档文件夹 `TestResult/yymmddhhmmss/`。

---

## 11. 81 条测试用例明细汇总表

以下为全量 **81 个测试用例** 的 ID、核心输入及预期断言：

### 81 条全量测试用例汇总清单

| 用例 ID | 所属技术类别 | 测试用例名称 (JUnit 方法名) | 核心输入数据 / 操作步骤 | 预期响应与断言预言 (Oracle) |
| --- | --- | --- | --- | --- |
| **TC-EP-001** | 等价类 (EP) | `test_TC_EP_001` | landmarks 33点, SQUAT, session1 | 返回 `200 OK` |
| **TC-EP-002** | 等价类 (EP) | `test_TC_EP_002` | landmarks = null | 返回 `4xx Client Error` |
| **TC-EP-003** | 等价类 (EP) | `test_TC_EP_003` | landmarks 10点, SQUAT | 返回 `4xx Client Error` |
| **TC-EP-004** | 等价类 (EP) | `test_TC_EP_004` | landmarks 0点, null运动类型 | 返回 `4xx Client Error` |
| **TC-EP-005** | 等价类 (EP) | `test_TC_EP_005` | landmarks 33点, SQUAT, session5 | 返回 `200 OK` |
| **TC-EP-006** | 等价类 (EP) | `test_TC_EP_006` | invalid_type, 0点 | 返回 `4xx Client Error` |
| **TC-EP-007** | 等价类 (EP) | `test_TC_EP_007` | landmarks 33点, SQUAT, session7 | 返回 `200 OK` |
| **TC-EP-008** | 等价类 (EP) | `test_TC_EP_008` | squat, landmarks = null | 返回 `4xx Client Error` |
| **TC-EP-009** | 等价类 (EP) | `test_TC_EP_009` | exercise=squat, count=2, duration=20 | 返回 `204 No Content` |
| **TC-EP-010** | 等价类 (EP) | `test_TC_EP_010` | 空 JSON Body {} 提交至 records | 返回 `204 No Content` |
| **TC-EP-011** | 等价类 (EP) | `test_TC_EP_011` | squat, count=5, duration=60 | 返回 `200 OK` |
| **TC-EP-012** | 等价类 (EP) | `test_TC_EP_012` | exercise=null, count=-1 | 返回 `204 No Content` |
| **TC-EP-013** | 等价类 (EP) | `test_TC_EP_013` | GET `/api/exercises` 获取列表 | 返回 `200 OK`, index 0 为 easy |
| **TC-EP-014** | 等价类 (EP) | `test_TC_EP_014` | GET `/api/exercises/invalid` | 返回 `4xx Client Error` |
| **TC-EP-015** | 等价类 (EP) | `test_TC_EP_015` | GET `/api/exercises` 获取列表 | 返回 `200 OK`, index 1 为 medium |
| **TC-EP-016** | 等价类 (EP) | `test_TC_EP_016` | GET `/api/exercises/invalid_med` | 返回 `4xx Client Error` |
| **TC-EP-017** | 等价类 (EP) | `test_TC_EP_017` | GET `/api/exercises` 获取列表 | 返回 `200 OK`, index 2 为 medium |
| **TC-EP-018** | 等价类 (EP) | `test_TC_EP_018` | GET `/api/exercises/invalid_hard` | 返回 `4xx Client Error` |
| **TC-EP-019** | 等价类 (EP) | `test_TC_EP_019` | GET `/api/user/test_user/dashboard` | 返回 `200 OK` |
| **TC-EP-020** | 等价类 (EP) | `test_TC_EP_020` | GET `/api/user/null/dashboard` | 返回 `200 OK` (自动容错创建) |
| **TC-BVA-001** | 边界值 (BVA) | `test_TC_BVA_001` | landmarks 31点 (极小值边界-1) | 返回 `4xx Client Error` |
| **TC-BVA-002** | 边界值 (BVA) | `test_TC_BVA_002` | landmarks 32点 (极小值边界) | 返回 `4xx Client Error` |
| **TC-BVA-003** | 边界值 (BVA) | `test_TC_BVA_003` | landmarks 33点 (极小值边界+1) | 返回 `200 OK` |
| **TC-BVA-004** | 边界值 (BVA) | `test_TC_BVA_004` | landmarks 33点, JUMPING_JACK (开合跳极大-1) | 返回 `200 OK` |
| **TC-BVA-005** | 边界值 (BVA) | `test_TC_BVA_005` | landmarks 34点 (极大值边界) | 返回 `200 OK` |
| **TC-BVA-006** | 边界值 (BVA) | `test_TC_BVA_006` | landmarks 35点 (极大值边界+1) | 返回 `200 OK` (分析器只取前33点) |
| **TC-BVA-007** | 边界值 (BVA) | `test_TC_BVA_007` | landmarks 31点, PUSHUP (俯卧撑极小-1) | 返回 `4xx Client Error` |
| **TC-BVA-008** | 边界值 (BVA) | `test_TC_BVA_008` | landmarks 32点, PUSHUP (俯卧撑极小) | 返回 `4xx Client Error` |
| **TC-BVA-009** | 边界值 (BVA) | `test_TC_BVA_009` | landmarks 33点, PUSHUP (俯卧撑极小+1) | 返回 `200 OK` |
| **TC-BVA-010** | 边界值 (BVA) | `test_TC_BVA_010` | landmarks 33点, PUSHUP (俯卧撑极大-1) | 返回 `200 OK` |
| **TC-BVA-011** | 边界值 (BVA) | `test_TC_BVA_011` | landmarks 34点, PUSHUP (俯卧撑极大) | 返回 `200 OK` |
| **TC-BVA-012** | 边界值 (BVA) | `test_TC_BVA_012` | landmarks 35点, PUSHUP (俯卧撑极大+1) | 返回 `200 OK` (只取前33点) |
| **TC-BVA-013** | 边界值 (BVA) | `test_TC_BVA_013` | squat, count=2, duration=29 (时长临界-1)| 返回 `204 No Content` |
| **TC-BVA-014** | 边界值 (BVA) | `test_TC_BVA_014` | squat, count=2, duration=30 (时长临界) | 返回 `200 OK` (临界满足) |
| **TC-BVA-015** | 边界值 (BVA) | `test_TC_BVA_015` | squat, count=2, duration=31 (时长临界+1)| 返回 `200 OK` |
| **TC-BVA-016** | 边界值 (BVA) | `test_TC_BVA_016` | squat, count=2, duration=20 (计数临界-1)| 返回 `204 No Content` |
| **TC-BVA-017** | 边界值 (BVA) | `test_TC_BVA_017` | squat, count=3, duration=20 (计数临界) | 返回 `200 OK` (临界满足) |
| **TC-BVA-018** | 边界值 (BVA) | `test_TC_BVA_018` | squat, count=4, duration=20 (计数临界+1)| 返回 `200 OK` |
| **TC-BVA-019** | 边界值 (BVA) | `test_TC_BVA_019` | pushup, count=2, duration=29 (时长临界-1)| 返回 `204 No Content` |
| **TC-BVA-020** | 边界值 (BVA) | `test_TC_BVA_020` | pushup, count=2, duration=30 (时长临界) | 返回 `200 OK` |
| **TC-BVA-021** | 边界值 (BVA) | `test_TC_BVA_021` | pushup, count=2, duration=31 (时长临界+1)| 返回 `200 OK` |
| **TC-BVA-022** | 边界值 (BVA) | `test_TC_BVA_022` | pushup, count=2, duration=20 (计数临界-1)| 返回 `204 No Content` |
| **TC-BVA-023** | 边界值 (BVA) | `test_TC_BVA_023` | pushup, count=3, duration=20 (计数临界) | 返回 `200 OK` |
| **TC-BVA-024** | 边界值 (BVA) | `test_TC_BVA_024` | pushup, count=4, duration=20 (计数临界+1)| 返回 `200 OK` |
| **TC-BVA-025** | 边界值 (BVA) | `test_TC_BVA_025` | plank, count=2, duration=-1 (负数边界) | 返回 `204 No Content` |
| **TC-BVA-026** | 边界值 (BVA) | `test_TC_BVA_026` | plank, count=2, duration=0 (零边界) | 返回 `204 No Content` |
| **TC-BVA-027** | 边界值 (BVA) | `test_TC_BVA_027` | plank, count=2, duration=1 (正数边界-小) | 返回 `204 No Content` |
| **TC-BVA-028** | 边界值 (BVA) | `test_TC_BVA_028` | plank, count=2, duration=20 (重复验证) | 返回 `204 No Content` |
| **TC-BVA-029** | 边界值 (BVA) | `test_TC_BVA_029` | plank, count=3, duration=20 (重复验证) | 返回 `200 OK` |
| **TC-BVA-030** | 边界值 (BVA) | `test_TC_BVA_030` | plank, count=4, duration=20 (重复验证) | 返回 `200 OK` |
| **TC-DT-001** | 决策表 (DT) | `test_TC_DT_001` | valid exerciseType (SQUAT), landmarks 33 | 返回 `200 OK` |
| **TC-DT-002** | 决策表 (DT) | `test_TC_DT_002` | invalid exerciseType (YOGA) | 返回 `4xx Client Error` |
| **TC-DT-003** | 决策表 (DT) | `test_TC_DT_003` | session_dt_cycle (完整深蹲周期循环) | 返回 `200 OK` |
| **TC-DT-004** | 决策表 (DT) | `test_TC_DT_004` | session_dt_invalid (跳过最低点非法动作) | 返回 `200 OK` (不计入总数) |
| **TC-DT-005** | 决策表 (DT) | `test_TC_DT_005` | count=2, duration=20 (count<3 且 duration<30)| 返回 `204 No Content` |
| **TC-DT-006** | 决策表 (DT) | `test_TC_DT_006` | count=2, duration=30 (count<3 且 duration>=30)| 返回 `200 OK` |
| **TC-DT-007** | 决策表 (DT) | `test_TC_DT_007` | count=3, duration=20 (count>=3 且 duration<30)| 返回 `200 OK` |
| **TC-DT-008** | 决策表 (DT) | `test_TC_DT_008` | count=3, duration=30 (count>=3 且 duration>=30)| 返回 `200 OK` |
| **TC-DT-009** | 决策表 (DT) | `test_TC_DT_009` | count=1, duration=10 (重复拦截验证) | 返回 `204 No Content` |
| **TC-DT-010** | 决策表 (DT) | `test_TC_DT_010` | count=1, duration=40 (重复通过验证) | 返回 `200 OK` |
| **TC-DT-011** | 决策表 (DT) | `test_TC_DT_011` | count=4, duration=15 (重复通过验证) | 返回 `200 OK` |
| **TC-DT-012** | 决策表 (DT) | `test_TC_DT_012` | count=4, duration=45 (重复通过验证) | 返回 `200 OK` |
| **TC-DT-013** | 决策表 (DT) | `test_TC_DT_013` | GET `/api/exercises` 校验首项难度 | 返回 `200 OK`, index 0 为 easy |
| **TC-DT-014** | 决策表 (DT) | `test_TC_DT_014` | GET `/api/exercises` 校验中项难度 | 返回 `200 OK`, index 1 为 medium |
| **TC-DT-015** | 决策表 (DT) | `test_TC_DT_015` | GET `/api/exercises` 校验末项难度 | 返回 `200 OK`, index 2 为 medium |
| **TC-DT-016** | 决策表 (DT) | `test_TC_DT_016` | GET `/api/user/{userId}/dashboard` 校验指标 | 返回 `200 OK` |
| **TC-CB-001** | 因果组合 (CB)| `test_TC_CB_001` | Pairwise: exerciseType=squat, minScore=80, sortBy=date | 返回 `200 OK` |
| **TC-CB-002** | 因果组合 (CB)| `test_TC_CB_002` | Pairwise: exerciseType=squat, minScore=90, sortBy=score | 返回 `200 OK` |
| **TC-CB-003** | 因果组合 (CB)| `test_TC_CB_003` | Pairwise: exerciseType=pushup, minScore=80, sortBy=score | 返回 `200 OK` |
| **TC-CB-004** | 因果组合 (CB)| `test_TC_CB_004` | Pairwise: exerciseType=pushup, minScore=90, sortBy=date | 返回 `200 OK` |
| **TC-CB-005** | 因果组合 (CB)| `test_TC_CB_005` | Pairwise: exerciseType=plank, minScore=80, sortBy=date | 返回 `200 OK` |
| **TC-CB-006** | 因果组合 (CB)| `test_TC_CB_006` | Pairwise: exerciseType=plank, minScore=90, sortBy=score | 返回 `200 OK` |
| **TC-ST-001** | 状态转换 (ST)| `test_TC_ST_001` | UP 状态初始化检测 | 返回 `200 OK` |
| **TC-ST-002** | 状态转换 (ST)| `test_TC_ST_002` | UP -> DESCENDING 迁移检测 | 返回 `200 OK` |
| **TC-ST-003** | 状态转换 (ST)| `test_TC_ST_003` | DESCENDING -> DOWN 迁移检测 | 返回 `200 OK` |
| **TC-ST-004** | 状态转换 (ST)| `test_TC_ST_004` | DOWN -> ASCENDING -> UP (完成直立) | 返回 `200 OK` |
| **TC-ST-005** | 状态转换 (ST)| `test_TC_ST_005` | UP -> COOLDOWN (系统休眠冷却) | 返回 `200 OK` |
| **TC-WBJ-001** | 白盒分支 (WB)| `test_TC_WBJ_001` | Method branch: count=2, duration=20 | 返回 `null` (拦截成功分支) |
| **TC-WBJ-002** | 白盒分支 (WB)| `test_TC_WBJ_002` | Method branch: count=5, duration=40 | 返回保存记录 (写入数据库成功分支)|
| **TC-WBJ-003** | 白盒分支 (WB)| `test_TC_WBJ_003` | Method branch: count=1, duration=10 | 返回 `null` (重复分支测试) |
| **TC-WBJ-004** | 白盒分支 (WB)| `test_TC_WBJ_004` | Method branch: count=4, duration=35 | 返回保存记录 (重复分支测试) |

---

## 12. 测试执行结果与分析

### 12.1 自动化测试执行结果数据
我们对这 81 条自动化用例在本地环境中进行了编译和运行：
* **用例运行数**：81/81 条
* **用例成功数**：81 条
* **失败数 / 错误数 / 跳过数**：0 / 0 / 0
* **测试用例成功率**：**100.00%**
* **运行耗时**：156.5 秒 (Maven Surefire 运行时)
![主页面](./image/allure-report-1.png)
![主页面](./image/allure-report-2.png)
![结果图表](./image/allure-report-3.png)

### 12.2 测试结果分析
对测试结果进行分析：
1. **Mock 隔离与事务回滚的有效性**：
   本次自动化测试采用 Spring Boot `@Transactional` 事务进行回滚。用例调取了 Controller 且打通了底层的 Spring 上下文和 Neon 云 PostgreSQL 数据库，在每个测试用例结束后，数据库的数据全部自动进行了物理回滚（Rollback）。这保证了后续的用例（如重置或重复边界测试）在面对数据库时处于独立的隔离环境，规避了由脏数据导致的失败。
2. **人工审计的前置拦截**：
   在正式执行测试之前，我们在开发阶段进行了交互式 Review，针对 AI 工具生成的 3 个“幻觉偏差”（见第 13 节）进行了**前置修改与对齐**。如果这 3 处偏差没有被修改，直接执行的话会导致测试直接产生 3 处编译/断言 Fail。因此，100% 的成功率**说明通过“设计者交互修改与人工审计”能起到前置拦截和校正的关键作用**。

### 12.3 不同测试技术发现缺陷与拦截能力深度对比

| 测试设计技术 | 用例占比 | 缺陷/偏差拦截能力评估 | 典型拦截案例 |
| --- | --- | --- | --- |
| **边界值分析 (BVA)** | 37.0% | **极强（★★★★★）**<br>能够发现后端对于入参的严苛物理限制及数组越界隐患。 | 发现了 landmarks 在 32 和 34 个点时，AI通用假设与后端固定 33 点校验之间的冲突。 |
| **决策表 (DT)** | 19.8% | **强（★★★★☆）**<br>对于存在多因子联合过滤的业务逻辑，能做到多维路径无缝覆盖。 | 验证了 records 的 count 与 duration 各种排列组合下的 204 与 200 拦截有效性。 |
| **等价划分 (EP)** | 24.7% | **中等（★★★☆☆）**<br>能做常规数据类型的合法与非法阻断，防止空值等基础溢出。 | 拦截了 null 值、空对象，并暴露出 Spring 对空 JSON body 自动反序列化赋予默认值从而退回 204 过滤的逻辑。 |
| **状态转换 (ST)** | 6.2% | **强（★★★★☆）**<br>在时间序列动作测试中，能验证状态机对动作流转的敏捷判定。 | 区分了深蹲起落的合规序列，并拦截了 UP -> DESCENDING -> UP 的取巧短动作（不计分）。 |
| **因果组合 (Combinatorial)**| 7.4% | **中等（★★★☆☆）**<br>实现了多因子的两两配对组合。 | 完成了对 plans 接口参数的合理组合覆盖。 |

### 12.4 自动化测试覆盖率量化数据
我们配置并运行了本地的 JaCoCo（Java Code Coverage）工具，对测试用例在 FitnessAI 项目底层核心业务类和方法上的覆盖率量化指标进行了统计。

#### 1. 核心目标测试方法覆盖率（`saveExerciseRecord`）
根据测试计划定义的白盒覆盖指标（COV-STMT-001 ~ COV-BR-002-F），测试脚本（TC-WBJ-001 ~ TC-WBJ-004）对核心的过滤保存方法进行了完整覆盖：
* **方法语句覆盖率 (Statement Coverage)**：**100.0%**（18/18 语句）
* **方法分支覆盖率 (Branch Coverage)**：**100.0%**（4/4 分支）
* **评估**：完全满足并超越了测试计划中设定的 $\ge 80\%$ 覆盖率目标。

#### 2. 底层核心类全局覆盖率统计（包含辅助非核心业务）
由于部分类中包含了大量未在此核心集成测试范围内的辅助方法（如 `UserService` 中包含 150 余行未在 Pairwise 排序测试中全部覆盖的内存复杂排序排序逻辑 `getFilteredHistoryRecords` 以及管理端清理逻辑），这些多维排序分支在目前的 6 个 Pairwise 接口测试用例之外，因此产生了未覆盖行。此外，还有清理、查询等其他管理侧 API 未被高强度触发。全局类的覆盖数据如下：
* **`UserService`（全类）**：
  * **行覆盖率 (Line Coverage)**：**43.6%**（99/227 行）
  * **分支覆盖率 (Branch Coverage)**：**14.4%**（26/180 分支）
* **`ExerciseController`（全类）**：
  * **行覆盖率 (Line Coverage)**：**48.1%**（26/54 行）
  * **分支覆盖率 (Branch Coverage)**：**66.7%**（4/6 分支）
* **`UserController`（全类）**：
  * **行覆盖率 (Line Coverage)**：**23.5%**（31/132 行）
  * **分支覆盖率 (Branch Coverage)**：**22.7%**（5/22 分支）
* **`SquatAnalyzer`（深蹲核心姿态分析类）**：
  * **行覆盖率 (Line Coverage)**：**92.8%**（77/83 行）
  * **分支覆盖率 (Branch Coverage)**：**80.0%**（32/40 分支）
![](./image/Jacoco-1.png)
![](./image/Jacoco-2.png)
![](./image/Jacoco-3.png)


### 12.5 测试执行中发现缺陷与偏差统计表

| 序号 | 发现的问题 / 预期冲突 | 严重程度 | 问题归属类型 | 后续处理方式与改进证据 |
| --- | --- | --- | --- | --- |
| 1 | `landmarks.length=32` 时 AI 预测返回 `200`，后端实际因 33 点严苛物理校验强行返回 `400`。 | **Major (严重)** | AI 测试设计预测幻觉 | 在测试脚本中将断言对齐修正为 `4xx`，保留严格校验以防物理算法数组越界。 |
| 2 | 传入空账户 ID `userId="null"` 时，AI 认为外键约束应返回 `5xx`，后端实际在 PG 中直接成功注册并返回 `200`。 | **Minor (轻微)** | 业务逻辑与安全假设偏差 | 修改断言为 `Ok`，保留后端的默认宽松免注册机制。 |
| 3 | 传入 `exercise_type=null` 且 `count=-1` 时，AI 认为应报入参报错 `4xx`，实际被业务逻辑层直接判定为无效记录返回 `204`。 | **Minor (轻微)** | 过滤器边界响应冲突 | 修改断言为 `isNoContent()`，吻合过滤规则。 |

---

## 13. 基于证据的用例改进与人工审计

在将 AutoTestDesign 生成的测试大纲落地为自动化测试的运行过程中，我们通过人工审计（Human-in-the-loop）发现了 3 处 AI 生成逻辑的幻觉和局限，并实施了基于证据的高质量改进：

1. **`landmarks.length=32` 的边界对齐（`TC-BVA-002` 等）**：
   * *AI 用例预测*：认为 32 是姿态请求的有效下边界（下边界，有效），预测返回 200。
   * *实际代码逻辑*：后端采用严格的 33 关键点物理校验，少一个点即非法，接口返回 400（CORS 安全拦截并打印 `❌ 无效的姿势分析请求`）。
   * *人工改进*：我们在保持用例 ID 与文字描述对应不变的前提下，在 `FitnessAiApiTests` 中将断言修正为了正确的 `.andExpect(status().is4xxClientError())`，测试得以成功运行。
2. **`userId="null"` 时的安全检测（`TC-EP-020`）**：
   * *AI 用例预测*：传入 `userId = "null"` 时，预测数据库会抛出外键错误或越权错误，返回 `5xx`。
   * *实际代码逻辑*：后端 UserService 采用的是 `getOrCreateUser("null")` 逻辑，在 PostgreSQL 中将 `"null"` 作为一个主键字符串直接写入了 users 表并注册成功，返回了 `200 OK`。
   * *人工改进*：我们将断言修改为 `.andExpect(status().isOk())`，对齐了后端的默认宽松注册规则。
3. **参数非法时的过滤拦截（`TC-EP-012` 等）**：
   * *AI 用例预测*：认为传入 `exercise_type = null` 且 `count = -1` 应该触发后端数据库空值校验，抛出 `4xx` 错误。
   * *实际代码逻辑*：后端拦截器采用过滤逻辑（`count < 3 && duration < 30`），由于未传入时长且计数 `-1` 小于过滤临界值，直接提前安全返回了成功状态码 `204 No Content`，未进入后续报错流。
   * *人工改进*：我们将断言修改为 `.andExpect(status().isNoContent())`，精确配合了后端的业务过滤规则。

通过这一阶段基于证据的改进，**AutoTestDesign 能够高宽度地帮我们进行 81 个多维度测试用例的自动大纲设计；而由测试开发工程师进行人工的审计对齐与交互式校正，则保障了测试集的严谨与可靠。**
