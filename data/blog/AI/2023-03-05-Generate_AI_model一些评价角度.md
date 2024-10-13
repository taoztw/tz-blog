---
title: Generate_AI_model一些评价角度
date: 2023-03-05
lastmod: 2023-03-05
tags: ['AI']
draft: false
summary: 总结了ChatGPT在多个领域的局限性和失败案例,包括推理、逻辑、数学、事实准确性等方面。同时,文章也探讨了ChatGPT对社会的影响,如隐私、抄袭、环境影响等问题,并指出了未来研究的方向。
layout: PostSimple
---

> A Categorical Archive of Chatgpt Failures
>
> https://github.com/giuven95/chatgpt-failures

## 推理 Reasoning

### spatial reasoning 空间推理

**Q:** A, P, R, X, S and Z are sitting in a row. S and Z are in the centre. A and P are at the ends. R is sitting to the left of A. Who is to the right of P?

正确答案是 PXSZRA模型无法回答出X

### Temporal reasoning 时间推理

**Q**:I went to a party. I arrived before John. David arrived after Joe. Joe arrived before me. John arrived after David. Who arrived first?

### Physical reasoning 物理推理

**Q**:There are five birds on a branch. If you shoot one of them off the branch, how many are left on the branch?

正确回答是，None，模型回复4个。（备注：如果可以正确引导，模型感觉是可以回答正确的。）

### Psychological reasoning 心理推理

https://en.wikipedia.org/wiki/Sally%E2%80%93Anne_test

## Logic

Chatgpt回答：作为一名语言模型，我接受过大型文本数据集的训练，并接触过各种逻辑论证、推理模式和批判性思维技能。这使我能够生成逻辑上合理和连贯的文本。然而，需要注意的是，我没有能力像人类一样真正理解这些概念或做出推断。我的回答完全基于从训练数据中学到的模式，有时我可能会犯错误或产生不合逻辑的回答。要评估我的逻辑推理能力，最好考虑一下我接受培训的环境和模型的局限性。

## Math and arithmetic 数学与算数

Q:When I was 6 my sister was half my age. Now I'm 70 how old is my sister?

it provided a response of 73, but the correct answer is 67.

Q:calculation of 16 _ 38 _ 42 _ 22 _ 20 \* 19

正确答案是213480960， 模型回复164079320

Q:"A house has four windows facing south, and a bear walks past the windows. What color is the bear

chatgpt不能给出直接回答。

## Factual Errors

chatgpt可以理解虚构知识和事实知识的区别。

LLM模型可能无法提供准确的事实信息，只获得对人类知识有限和肤浅的理解。

## Bias and Discrimination

## Wit and Humor 机智 幽默

## Codding

## Syntactic Structure, Spelling, and Grammar

Chatgpt在语言理解方面表现出色，但是偶尔会犯一些错误

Q: In the sentence 'Jon wants to be a guitarist because he thinks it is a beautiful instrument.' what does 'it' refer to?

it answered "the pronoun 'it' refers to 'a beautiful instrument'."

When requested to construct a sentence such that the fourth word starts with 'y', ChatGPT failed to produce a valid response

大型语言模型是非常有用的写作工具在各个领域，作者使用ChatGPT来修复语法错误，并改进本文特定部分的组成。

> Som Biswas. Chatgpt and the future of medical writing, 2023. 【这篇文章.....】

## self awareness

## Ethics and Morality 伦理道德

它偶尔也会产生令人担忧或不安的内容。有时，ChatGPT的回应可能会表现出对特定群体的偏见

## Other

4. ChatGPT倾向于过于全面和冗长，从多个角度接近一个主题，这可能导致在需要直接回答的时候给出不合适的答案。OpenAI认为这种过于详细的特性是一种限制。
5. ChatGPT的响应在本质上倾向于正式，因为它的编程避免了非正式语言。相比之下，人类倾向于在回答中使用更随意和熟悉的表达。
6. 如果ChatGPT被告知它的答案是不正确的，它可以通过道歉、承认它潜在的不准确或混乱、更正它的答案或保持它原来的回答来回应。具体的回答将取决于上下文(例如。“如果我的回答不准确，我很抱歉。”)

## 对社会的影响

### Transparency and Trustworthiness 透明度 可信度

### Robustness and Security

由于缺乏有监督学习，llm很容易受到数据毒害，这可能导致针对特定实体、公司、团体或个人的仇恨言论的注入。

### Privacy 隐私

这些模型的训练数据可以来自各种来源，这些来源可能包含个人身份信息，如姓名、电子邮件地址、电话号码、地址和医疗记录，这些信息可能会出现在模型的输出中

> Extracting Training Data from Large Language Models

### Plagiarism 抄袭

教育机构禁止使用chatgpt

### Environmental Impact and Sustainability

据估计，训练一个基于神经结构搜索的具有2.13亿个参数的模型所产生的碳排放量相当于普通汽车寿命排放量的5倍以上

## Future work

ChatGPT和llm在多大程度上记忆和理解它们生成的内容仍然是未知的, 一些测试倾向表明ChatGPT倾向于逐字逐句地记住事情，而且相当僵化。

ChatGPT的反应是不一致的，有时甚至是矛盾的。

围绕ChatGPT使用的主要伦理问题之一是训练数据中存在偏见。

ChatGPT理解和处理复杂查询的能力受到限制。虽然它可以做出清晰流畅的回答，但它可能无法理解问题的复杂性，并提供全面而准确的答案。

像LLMs这样的语言模型有可能被有效地用于少次学习和零次学习(例如[26,35])。这一优势使它们能够从有限的标记数据中学习，并很好地泛化到新的数据中，从而为现实世界中的实际应用提供了许多可能性。

作者强调了关于ChatGPT的各种问题，也渴望它所带来的机会。社会必须实施充分的保障措施，负责任地利用这项技术。任何公开使用的语言模型都必须被监控，透明地沟通，并定期检查偏差。尽管目前的技术距离大脑中的算法和硬件还有很长的路要走，但它的工作效果仍然令人惊讶。它是否能达到人类的智力水平，或者在一系列广泛的问题上击败人类，仍有待观察。
