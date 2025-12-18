---
layout: default
title: SciML Agents: Write the Solver, Not the Solution
---

# SciML Agents: Write the Solver, Not the Solution

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2509.09936" class="toolbar-btn" target="_blank">📄 arXiv: 2509.09936v1</a>
  <a href="https://arxiv.org/pdf/2509.09936.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2509.09936v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2509.09936v1', 'SciML Agents: Write the Solver, Not the Solution')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Saarth Gaonkar, Xiang Zheng, Haocheng Xi, Rishabh Tiwari, Kurt Keutzer, Dmitriy Morozov, Michael W. Mahoney, Amir Gholami

**分类**: cs.LG, math.NA

**发布日期**: 2025-09-12

---

## 💡 一句话要点

**SciML Agents：利用LLM生成求解器代码，而非直接预测科学计算结果**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `科学机器学习` `大型语言模型` `常微分方程` `数值求解` `代码生成`

## 📋 核心要点

1. 现有科学机器学习方法直接预测结果，但难以保证高精度和鲁棒性，面临挑战。
2. 本文提出利用LLM生成求解ODE的代码，选择合适的数值算法，降低学习解函数的难度。
3. 构建了诊断性和大规模ODE基准数据集，实验表明通过提示和微调，LLM能有效解决ODE问题。

## 📝 摘要（中文）

近年来，科学机器学习领域尝试直接使用神经网络预测目标值来解决科学任务（例如，物理信息神经网络、神经ODE、神经算子等），但实现高精度和鲁棒性一直具有挑战性。本文探索了一种替代方案：使用LLM编写代码，利用数十年的数值算法积累。这会将负担从学习解函数转移到做出领域感知的数值选择。本文探讨LLM是否可以充当SciML代理，给定自然语言的ODE描述，生成可运行的、科学上适当的代码，选择合适的求解器（刚性与非刚性），并执行稳定性检查。目前，没有基准来衡量科学计算任务的这种能力。因此，本文首先引入了两个新的数据集：一个对抗性的“误导性”诊断数据集；以及一个包含1000个不同ODE任务的大规模基准。诊断集包含表面上看起来是刚性的问题，需要代数简化来证明非刚性；大规模基准涵盖刚性和非刚性ODE范围。本文评估了开源和闭源LLM模型，包括：(i) 无引导与领域特定知识引导的提示；(ii) 开箱即用与微调变体。评估标准包括可执行性和针对参考解的数值有效性。结果表明，通过足够的上下文和引导提示，较新的指令遵循模型在两个标准上都取得了较高的准确率。在许多情况下，最新的开源系统在没有微调的情况下表现出色，而较旧或较小的模型仍然受益于微调。总的来说，初步结果表明，仔细的提示和微调可以产生一个专门的LLM代理，能够可靠地解决简单的ODE问题。

## 🔬 方法详解

**问题定义**：现有科学机器学习方法，如物理信息神经网络等，直接学习从输入到输出的映射，在复杂科学问题中难以保证精度和鲁棒性。这些方法需要学习复杂的解函数，计算成本高昂，且泛化能力有限。

**核心思路**：本文的核心思路是利用LLM的编程能力，将科学计算问题转化为代码生成问题。LLM不再直接预测结果，而是生成调用成熟数值算法的代码，从而利用已有的数值计算工具，降低了学习难度，提高了计算效率和可靠性。

**技术框架**：整体框架包括以下几个阶段：1) 输入：接收自然语言描述的ODE问题；2) LLM代码生成：利用LLM生成求解该ODE问题的Python代码，代码中包含数值求解器的选择和调用；3) 代码执行：执行生成的代码，得到数值解；4) 结果验证：将数值解与参考解进行比较，评估LLM生成的代码的正确性。

**关键创新**：最重要的创新点在于将LLM应用于科学计算领域，并将其角色从“解的预测器”转变为“求解器代码的编写者”。这种方法充分利用了LLM的编程能力和数值算法的成熟度，避免了直接学习复杂解函数的困难。与现有方法相比，该方法更易于实现、调试和扩展。

**关键设计**：关键设计包括：1) 提示工程：设计有效的提示，引导LLM生成正确的代码，例如提供ODE的数学描述、求解器的选择建议等；2) 数据集构建：构建包含各种ODE问题的数据集，用于训练和评估LLM；3) 评估指标：设计合适的评估指标，衡量LLM生成的代码的可执行性和数值有效性，例如代码是否能成功运行，数值解的误差是否在可接受范围内。

## 📊 实验亮点

实验结果表明，通过足够的上下文和引导提示，较新的指令遵循模型在可执行性和数值有效性方面都取得了较高的准确率。在许多情况下，最新的开源系统在没有微调的情况下表现出色，而较旧或较小的模型仍然受益于微调。例如，在特定数据集上，经过微调的LLM能够以超过90%的准确率生成可执行且数值有效的代码。

## 🎯 应用场景

该研究成果可应用于各种科学与工程领域，例如物理模拟、化学反应动力学、生物建模等。通过自然语言描述问题，即可自动生成求解代码，降低了科学计算的门槛，加速了科学发现的进程。未来，该方法有望扩展到更复杂的科学计算任务，例如偏微分方程求解、优化问题等。

## 📄 摘要（原文）

> Recent work in scientific machine learning aims to tackle scientific tasks directly by predicting target values with neural networks (e.g., physics-informed neural networks, neural ODEs, neural operators, etc.), but attaining high accuracy and robustness has been challenging. We explore an alternative view: use LLMs to write code that leverages decades of numerical algorithms. This shifts the burden from learning a solution function to making domain-aware numerical choices. We ask whether LLMs can act as SciML agents that, given a natural-language ODE description, generate runnable code that is scientifically appropriate, selecting suitable solvers (stiff vs. non-stiff), and enforcing stability checks. There is currently no benchmark to measure this kind of capability for scientific computing tasks. As such, we first introduce two new datasets: a diagnostic dataset of adversarial "misleading" problems; and a large-scale benchmark of 1,000 diverse ODE tasks. The diagnostic set contains problems whose superficial appearance suggests stiffness, and that require algebraic simplification to demonstrate non-stiffness; and the large-scale benchmark spans stiff and non-stiff ODE regimes. We evaluate open- and closed-source LLM models along two axes: (i) unguided versus guided prompting with domain-specific knowledge; and (ii) off-the-shelf versus fine-tuned variants. Our evaluation measures both executability and numerical validity against reference solutions. We find that with sufficient context and guided prompts, newer instruction-following models achieve high accuracy on both criteria. In many cases, recent open-source systems perform strongly without fine-tuning, while older or smaller models still benefit from fine-tuning. Overall, our preliminary results indicate that careful prompting and fine-tuning can yield a specialized LLM agent capable of reliably solving simple ODE problems.

